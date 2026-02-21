# RL Sepsis Ajanı: Veri Ön İşleme (Preprocessing) Konsey Değerlendirmesi

**Bağlam:**
Biz tıp alanında, MIMIC-IV veri setini kullanarak Sepsis yönetimi için Derin Pekiştirmeli Öğrenme (Deep Reinforcement Learning - DRL) modelleri geliştirmeyi amaçlayan bir proje yürütüyoruz. Amacımız, yoğun bakım (ICU) ortamındaki sepsis hastalarının verilerini işleyerek klinik durumlarını (state) modellemek ve bu verilere dayanarak optimum tedavi stratejilerini (örn. vazopressör dozajı ve sıvı tedavisi) öğrenecek yapay zeka ajanları (RL agent) eğitmektir.

Veri biliminde performansı artırmak ve RAM taşmasını engellemek amacıyla Polars kütüphanesini kullanarak, zaman serisi tıbbi verileri saatli periyotlara (hourly binning) çeviren, lazy evaluation + single-pass group-by içeren bellek dostu bir süreç kurguladık.

**Görev:**
Sen üst düzey bir veri bilimi ve medikal yapay zeka konseyinin danışman üyesisin. Bu istem (prompt) ile birlikte sana projemizin durumunu anlatan dosyalar ve kodlar sağlıyorum. Lütfen sana ilettiğim şu dökümanları incele:
1. `project_summary.md`: Projenin genel mimarisi, yapısı ve hedefi.
2. `notebooks/01_data_explore.md` & `notebooks/02_feature_engineering.md`: Veri üzerinde yaptığımız keşifsel analiz (EDA), hücre (cell) çıktıları, eksik veri grafikleri, saatlik gruplamalar ve korelasyonların sonuçları.
3. `src/preprocess/config.py` & `src/preprocess/pipeline.py`: Araştırmalarımız sonucunda elde ettiğimiz bulguları, Polars kullanarak devasa MIMIC-IV verilerine (OOM hatası almadan) uyguladığımız production-ready (canlıya hazır) nihai bellek dostu ön işleme hattımız.

***(Önemli Not: Notebook'larda verinin yapısı/çıktıları ve EDA yöntemlerimiz mevcuttur. Python (.py) dosyalarında ise bu kararların tüm veriye nasıl bir teknik mimariyle aktarıldığı bulunur. Lütfen her iki kaynağı da sentezleyerek yorum yap.)***

Lütfen sadece "veri ön işleme", "feature engineering" ve "RL State (durum) / Action (aksiyon) alanı seçimi" kapsamlarına odaklanarak kodlarımızı ve çıktıları analiz et. Bize şu soruların cevabını ve stratejik öneriler sun:

1. **Bu projenin veri ön işlemesinde eksik olan kritik bilgiler, özellikler (feature) nelerdir?** 
   - İlettiğim notebook çıktılarına (eksik veri oranları vs.) ve Python dosyalarındaki logic'e bakarak, RL ajanının "state" (durum) uzayı için eksik ama başarı için elzem olan laboratuvar, vital veya demografik veriler var mı? (Örn: Sepsis-3 teşhis kriterleri eksiksiz karşılanıyor mu? Saatlik SOFA skoru, SIRS kriterleri, antibiyotik kullanım başlama zamanı, mekanik ventilasyon durumu eklenmeli mi?)

2. **Mevcut Verilerden Neler Üretilebilir / Eklenebilir?**
   - Hangi yeni klinik/laboratuvar değişkenler modele önemli bir içgörü katar? EDA verilerine dayanarak RL ajanı için state tanımını güçlendiren ek "feature engineering" tavsiyelerin nelerdir? (Örn: Değişim hızları (delta değerleri), ağırlık üzerinden standardize edilmiş dozlar vs.)

3. **Mevcut geliştirme aşamasında (kodda veya metodolojide) geliştirilebilecek mühendislik / istatistiksel yöntemler nelerdir?**
   - Özellikle Notebook'lardaki hücre sonuçlarını dikkate alıp, `pipeline.py` içindeki işlemleri (imputasyon vs.) birleştirdiğinde, daha efektif bir işleme veya doldurma metodu görüyor musun? (Örn: Biz forward-fill uyguladık. İstatistiksel ve tıbbi olarak, ekstrem null oranına sahip feature'larda daha iyi bir interpolasyon/imputasyon uygulanabilir mi? Outlier handling veya scaling konusunda eksiklerimiz nelerdir?)

Lütfen sadece genel-geçer bilgiler vermek yerine, sana verdiğim kod mimarisini ve notebook çıktı sonuçlarını *(null oranları, dağılımlar vs.)* baz alarak projemize özel net, uygulanabilir teknik ve tıbbi tavsiyeleri **maddeler halinde ve detaylı olarak** açıkla.

---
*(Lütfen cevaplarınızı direkt çözüm stratejilerimiz üzerine odaklayın, yukarıdaki metni veya kod bloklarını gereksiz yere tekrar kopyalamayın.)*
