# Local AI: model seçimi (AI-01)

16 Ekim 2026. Amaç: bu makinede (Apple M4, 16 GB, MacBook Air) Türkçe sorularda **doğru tool'u doğru
argümanla seçen**, **şemaya uyan JSON** üreten ve **backend'in verdiği rakamları uydurmadan açıklayan** local
Qwen modelini tahminle değil ölçümle seçmek. Ücretli API yok; her şey Ollama üzerinden yerel.

## Karar

| | |
| --- | --- |
| Varsayılan model | **`qwen3.5:4b`** (`BANKINGAI_LLM_MODEL`) |
| Yedek | `qwen3.5:9b` (indirili; tek satırla geçilir) |
| Thinking | **Kapalı** (`think: false`) |
| Sampling | `temperature: 0` (aynı soru aynı seçimi alsın) |
| Yeniden ölçüm | MCP-12/MCP-14'te gerçek tool listesiyle iki model yeniden ölçülür; 4b tool seçiminde %90'ın altına düşerse 9b'ye geçilir |

Neden 4b: iki model de geçme ölçütünü sağladı. 9b biraz daha isabetli ama bu makinede bedeli yüksek: 8–10 GB bellek
alıyor ve ölçüm sırasında swap 7,6 GB'tan 11,4 GB'a çıktı, hızı 12–20 token/sn'ye düştü. İleride aynı anda PostgreSQL
(Colima), .NET API, FastAPI, MCP server ve Xcode/Simulator çalışacak. 4b'nin hataları mimarinin zaten yakaladığı
türden (backend varsayılanıyla aynı fazladan argüman; bir yüzdeyi yazmamak); uydurma sayı iki modelde de yok.
Doğruluğu modelin büyüklüğü değil backend'in kontrolleri sağlar (AI-06, AI-09/10, MCP-12'de argüman doğrulaması).

## Ortam

- Ollama 0.40.5 (macOS uygulaması), modeller harici SSD'de (`OLLAMA_MODELS`, Ollama ayarlarındaki "Model location").
  SSD takılı değilken Ollama açılırsa modeller bulunamaz (AI-02'nin "model bulunamadı" senaryosu).
- `ollama pull qwen3.5:9b` / `qwen3.5:4b` bu Mac'te MLX biçimini indirdi (`nvfp4`; 7,6 GB ve 4,0 GB), q4_K_M değil.
- Python 3.14, yalnız standart kütüphane (Ollama REST API'sine düz HTTP). FastAPI/LangChain AI-03/04'te gelir.

## Yöntem

`ai/model_check/` (sabit vakalar + deterministik puanlama; model kendi çıktısını puanlamaz):

| Grup | Vaka | Ne ölçülür | Geçme koşulu |
| --- | --- | --- | --- |
| Tool seçimi (T01–T12) | 6 tool (analytics endpoint'lerinin sade hali), 10 analiz sorusu + transfer isteği + fıkra | Tool adı ve argümanlar birebir | Tek çağrı, doğru ad, beklenen argümanlar; **söylenmemiş argüman = hata**; kapsam dışında çağrı yok |
| Structured output (S01–S05) | Soru sınıflandırma (`intent`, `period`), Ollama `format` = JSON şema | Geçerli JSON + doğru değerler | Alanlar ve değerler birebir |
| Açıklama (E01–E03) | Hazır backend sonucu (Türkçe biçimli tutar/yüzde) → 2–3 cümle | Uydurma sayı, zorunlu metin | Metindeki her sayı verilen veride var; zorunlu metinler ("735,00 TL", "%29,12" …) aynen geçiyor |

Geçme ölçütü (plan kararı): tool seçiminde en az %90, JSON %100, uydurma sayı yok, cevap başına yaklaşık 10 sn altı.
Açıklama vakalarındaki rakamlar örnek veridir (E02: 415/1.425 = %29,12; E03: 420/735 = %57,14, 210/735 = %28,57,
105/735 = %14,29).

## Sonuçlar (thinking kapalı, temperature 0; iki koşu birebir aynı)

| | qwen3.5:4b | qwen3.5:9b |
| --- | --- | --- |
| Tool seçimi | 11/12 (T08: söylenmemiş `limit=5`) | **12/12** |
| Structured output | 5/5 | 5/5 |
| Açıklama (otomatik puan) | 2/3 (E03: `%57,14` yazılmadı) | 3/3 |
| Ortalama süre: tool / structured / açıklama | **3,1 / 1,3 / 5,0 sn** | 4,6 / 2,6 / 8,3 sn |
| Hız | 21–25 token/sn | 12–20 token/sn (bellek baskısında) |
| İlk yükleme | ~6 sn | ~11 sn |
| Yüklü bellek (`/api/ps`, 4K bağlam) | 4,2–6,9 GB | 7,7–10 GB |

Thinking açık: tool vakaları koşturulamadı. `temperature: 0` ile model "Merhaba"ya 1.500 token düşünüp cevaba hiç
geçmedi (greedy decoding'de tekrar döngüsü; Qwen bu modda greedy kullanılmamasını önerir). Önerilen sampling
(0.6 / 0.95 / 20) ile cevap geldi ama 989 düşünme token'ı, **50 sn**. Ölçütün çok dışında → thinking kapalı.
`run.py --think` artık Qwen'in önerdiği sampling'i kullanır.

## Gözlemler

- **Structured output'ta şema prompt'a da yazılmalı.** İlk koşuda iki model de her soruya `out_of_scope` dedi (1/5).
  `format` yalnız çıktıyı şemaya zorlar, modele göstermez; model prompt'ta adı geçen tek değerleri seçiyordu.
  `format` olmadan da aynı cevap geldi (kök neden prompt). Intent ve dönem değerleri anlamlarıyla prompt'a yazılınca
  ikisi de 5/5.
- **Sayı kontrolü anlam hatasını yakalamaz.** 9b'nin E02'si puanlamayı geçti ama yönü ters: "1.840,00 TL'den
  1.425,00 TL'ye yükselerek". 4b'nin E02'si de anlamca bulanık. Bu, AI-10 (sayı doğrulayıcı + şablon cevap) ve
  "nasıl hesaplandı" panelinin (AI-11) neden gerekli olduğunu gösterir; model büyütmek çözmez.
- Modeller tutarları kalın (`**735,00 TL**`) yazabiliyor; gösterim katmanı Markdown'u hesaba katmalı (AI-08/IOS).
- Kapsam dışı istekler (transfer, fıkra) iki modelde de tool'suz cevaplandı.

## Bilinen sınırlar

- Az vaka (20) ve tek koşu: temperature 0 ile tekrarlanabilir ama soru çeşitliliği dar. Gerçek tool sayısı (15–18)
  MCP'de olacak; yeniden ölçüm o yüzden karar tablosunda.
- Puanlama yazıyla yazılmış sayıları ("yedi yüz") ve anlam hatalarını görmez; Türkçe kalitesi insan gözüyle okunur
  (`run.py` cevapları tablonun altına basar).
- Ölçüm, açık uygulamalarla dolu bir makinede yapıldı (başlangıçta 9,6 GB swap); süreler yük altındaki değerlerdir.

## Çalıştırma

```sh
python3 -m unittest discover -s ai/model_check                       # puanlama testleri (Ollama gerekmez)
python3 ai/model_check/run.py --model qwen3.5:4b --model qwen3.5:9b   # iki modeli karşılaştır
python3 ai/model_check/run.py --only tool                            # BANKINGAI_LLM_MODEL ile tek grup
```
