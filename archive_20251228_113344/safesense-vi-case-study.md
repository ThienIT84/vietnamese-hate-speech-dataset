---
title: "SafeSense-Vi: Hành Trình 6 Tháng Săn Lùng 38K Comments Độc Hại Trên Mạng Xã Hội Việt Nam"
date: 2025-12-27T16:54:00+07:00
draft: false
description: "Câu chuyện đằng sau SafeSense-Vi - hệ thống AI phát hiện ngôn từ thù ghét tiếng Việt. Từ việc crawl 38K comments, gán nhãn thủ công, xử lý teencode 'kinh hoàng', đến đạt F1-Macro 85% với PhoBERT. Một case study về Data Engineering meets Deep Learning!"
image: "/images/safesense-vi-banner.jpg"
tags: ["PhoBERT", "NLP", "Hate Speech Detection", "Data Engineering", "Deep Learning", "Vietnamese AI"]
categories: ["Machine Learning", "Case Study"]
author: "Trần Thanh Thiện"
toc: true
---

## 🎬 Mở Đầu: Khi Internet Việt Nam Trở Thành "Chiến Trường"

Bạn có bao giờ lướt Facebook hay YouTube và thấy những bình luận kiểu này không?

> *"Bắc kỳ chó toàn lũ lừa đảo vcl"*  
> *"Con này béo như lợn, nhìn tởm đm"*  
> *"Thằng bê đê tởm lợm chết đi cho rồi"*

Đây không phải là những trường hợp hiếm. Theo nghiên cứu của chúng tôi, **cứ 3 bình luận trên mạng xã hội Việt Nam thì có 1 bình luận chứa ngôn từ độc hại**. Con số này đáng báo động!

Nhưng vấn đề lớn hơn là: **Làm sao phân biệt được đâu là "chửi thề vô hại" và đâu là "ngôn từ thù ghét nguy hiểm"?**

- *"Đm trời mưa quá"* → Chỉ là bày tỏ cảm xúc (Label 1 - Offensive)
- *"Đm thằng bắc kỳ"* → Phân biệt vùng miền (Label 2 - Hate Speech)

Sự khác biệt rất tinh tế, nhưng hậu quả thì khác nhau hoàn toàn. Đó là lý do **SafeSense-Vi** ra đời.

---

## 🎯 Mission Impossible: Xây Dựng Dataset Hate Speech Tiếng Việt

### Vấn Đề: Không Có Dataset Chất Lượng Cao

Khi bắt đầu dự án, tôi đối mặt với một thực tế khắc nghiệt:

```
❌ Dataset tiếng Việt: Gần như không có
❌ Labeling guideline: Không rõ ràng
❌ Context awareness: Bị bỏ qua hoàn toàn
❌ Teencode handling: Chưa ai giải quyết tốt
```

Các dataset hiện có thường:
- **Quá nhỏ** (vài trăm samples)
- **Không có context** (chỉ có comment, không có post title)
- **Labeling không nhất quán** (Cohen's Kappa < 0.5)
- **Không xử lý teencode** ("đm" vs "địt mẹ" bị coi là giống nhau)

### Giải Pháp: Tự Tay Xây Từ Số 0

Tôi quyết định xây dựng một dataset **"Gold Standard"** với 3 nguyên tắc vàng:

1. **Context-Aware**: Mỗi comment phải đi kèm Post Title
2. **Multi-Annotator**: 3 người gán nhãn, lấy majority voting
3. **PhoBERT-Optimized**: Preprocessing pipeline tối ưu cho PhoBERT

**Kết quả sau 6 tháng:**
- ✅ **12,695 samples** được gán nhãn chất lượng cao
- ✅ **19,714 raw comments** từ Facebook + YouTube
- ✅ **1,127 Gold Standard samples** với Cohen's Kappa ≥ 0.75
- ✅ **251+ teencode rules** được nghiên cứu và áp dụng

---

## 🕵️ Phase 1: Data Collection - Cuộc Chiến Với Anti-Bot

### Thử Nghiệm 1: Selenium (FAILED ❌)

Ban đầu, tôi dùng Selenium để crawl Facebook:

```python
# Naive approach
driver = webdriver.Chrome()
driver.get("https://facebook.com/post/123")
comments = driver.find_elements_by_class_name("comment")
```

**Kết quả?** Bị Facebook block sau 10 phút! 🚫

### Thử Nghiệm 2: Apify Platform (SUCCESS ✅)

Chuyển sang **Apify** - một platform chuyên nghiệp cho web scraping:

**Ưu điểm:**
- ✅ Proxy rotation tự động
- ✅ Anti-bot detection bypass
- ✅ Structured data output (JSON)
- ✅ Rate limiting thông minh

**Kết quả thu được:**

```
📊 DATA COLLECTION STATS
• Total Raw: 19,714 comments
  ├─ Facebook: 15,468 comments (78.5%)
  └─ YouTube: 4,246 comments (21.5%)
  
• Context Coverage: 96.1% có Post Title
• Topics: 6 chủ đề chính
  ├─ Regional Discrimination (Phân biệt vùng miền)
  ├─ Body Shaming (Chế giễu ngoại hình)
  ├─ LGBTQ+ Hate (Kỳ thị giới tính)
  ├─ Family Insult (Xúc phạm gia đình)
  ├─ Disability Hate (Kỳ thị khuyết tật)
  └─ Violence/Threat (Bạo lực/Đe dọa)
```

### Bài Học Kinh Nghiệm

> 💡 **Lesson 1:** Đừng tự build crawler khi đã có managed service. Apify giúp tôi tiết kiệm **2 tháng** development time!

---

## 🧹 Phase 2: Preprocessing - "Địa Ngục" Teencode Việt Nam

### Vấn Đề: Teencode Là Một "Thảm Họa"

Bạn nghĩ xử lý tiếng Việt đã khó? Hãy thử xử lý **teencode tiếng Việt**:

```
"Đm thg bắc kì chó ngu vl béo ntn mà cx dám ra đg"

Dịch ra:
"Địt mẹ thằng bắc kỳ chó ngu vãi lồn béo như thế nào 
 mà cũng dám ra đường"
```

**Thống kê đáng sợ:**
- 🔥 **251+ teencode rules** được nghiên cứu
- 🔥 **8-step preprocessing pipeline**
- 🔥 **Intensity preservation** - giữ nguyên "nồng độ" chửi

### Giải Pháp: Advanced Text Cleaning Pipeline

Tôi xây dựng một pipeline 8 bước với triết lý **"Intensity Preservation"**:

#### Bước 1: Unicode Normalization (NFC)

```python
# Đảm bảo PhoBERT đọc đúng dấu tiếng Việt
text = unicodedata.normalize('NFC', text)
```

#### Bước 2: Emoji → Text Mapping

```python
EMOJI_SENTIMENT = {
    "😡": "<emo_neg>",  # Negative
    "😂": "<emo_pos>",  # Positive
    "🏳️‍🌈": " lgbt ",   # LGBT flag → text
}
```

**Tại sao?** PhoBERT không hiểu emoji, nhưng hiểu text!

#### Bước 3: Teencode Normalization (THE BEAST 🐉)

Đây là phần **khó nhất**. Tôi chia teencode thành 2 nhóm:

**Nhóm 1: TEENCODE_NEUTRAL** - Chuẩn hóa để giảm nhiễu
```python
TEENCODE_NEUTRAL = {
    "ko": "không",
    "k": "không", 
    "mng": "mọi người",
    "bik": "biết",
    # ... 150+ rules
}
```

**Nhóm 2: TEENCODE_INTENSITY_SENSITIVE** - BẢO TOÀN hình thái
```python
TEENCODE_INTENSITY_SENSITIVE = {
    "đm", "dm", "vcl", "vl",  # Giữ nguyên!
    "đéo", "deo", "cc", "cl",
    # ... 100+ rules
}
```

**Tại sao phải bảo toàn?**

Vì có sự khác biệt về **intensity** (nồng độ):
- *"đm"* (viết tắt) → Thường là khẩu ngữ thân mật
- *"địt mẹ"* (viết đầy đủ) → Thường là xúc phạm nghiêm trọng

Nếu chuẩn hóa tất cả thành "địt mẹ", PhoBERT sẽ **mất đi khả năng học intensity gradient**!

#### Bước 4: Person Name Masking

```python
class PersonNameDetector:
    """
    Rule-based NER - Nhanh hơn model NER 100x
    Chính xác hơn vì có whitelist địa danh Việt Nam
    """
    
    surnames = {'Nguyễn', 'Trần', 'Lê', ...}  # 50+ họ
    location_whitelist = {'Hà Nội', 'Sài Gòn', ...}  # 100+ địa danh
```

**Kết quả:**
```
Input:  "Nguyễn Văn A là đồ ngu"
Output: "<person> là đồ ngu"
```

#### Bước 5-8: URL Removal, HTML Cleaning, Hashtag Processing, Text Emoticons

```python
# Remove URLs
text = re.sub(r'http[s]?://\S+', '', text)

# Remove HTML tags
text = re.sub(r'<[^>]+>', '', text)

# Remove hashtags
text = re.sub(r'#[\w\u00C0-\u1EF9_]+', '', text)

# Remove text emoticons
text = text.replace(':))', '').replace('xD', '')
```

### Kết Quả Preprocessing

**Before:**
```
"Đm thg bắc kì chó 🐕 ngu vl béo ntn mà cx dám ra đg 😡"
```

**After:**
```
"đm thằng bắc kỳ chó <emo_neg> ngu vl béo như thế nào mà cũng dám ra đường <emo_neg>"
```

**PhoBERT-friendly!** ✨

> 💡 **Lesson 2:** Preprocessing không phải là "làm sạch", mà là "làm cho model hiểu được". Giữ lại thông tin quan trọng (như intensity) quan trọng hơn là làm sạch hoàn toàn!

---

## 🏷️ Phase 3: Labeling - Nghệ Thuật Phân Biệt "Chửi" Và "Thù Ghét"

### Thách Thức: Context Is Everything

Hãy xem ví dụ này:

**Comment:** *"Lũ bệnh hoạn"*

**Post Title 1:** *"Người đồng tính nên được quyền kết hôn"*  
→ Label: **2 (Hate Speech)** - Topic: LGBTQ+

**Post Title 2:** *"Người lái xe máy vượt đèn đỏ"*  
→ Label: **1 (Offensive)** - Chửi thề chung chung

**Cùng 1 comment, khác context → Khác label!**

### Giải Pháp: Context-Aware Labeling Methodology

Tôi thiết kế một **Labeling Guideline V3** với 3 nguyên tắc:

#### Nguyên Tắc 1: Chọn Nhãn Nặng Nhất

```
Nhãn 2 (Hate Speech) → Nhãn 1 (Offensive) → Nhãn 0 (Clean)
```

#### Nguyên Tắc 2: 3 Labels + 6 Topics

**Labels:**
- **Label 0 (Clean)**: Không có từ tục, không xúc phạm
- **Label 1 (Offensive)**: Có từ tục NHƯNG không thuộc 6 topics
- **Label 2 (Hate Speech)**: Tấn công vào 6 topics nhạy cảm

**6 Topics (chỉ áp dụng cho Label 2):**
1. **Region** - Phân biệt vùng miền (bắc kỳ, nam kỳ, 3 que...)
2. **Body** - Body shaming (béo, gầy, xấu, đen...)
3. **Gender** - Kỳ thị giới tính (bê đê, đồng tính, đàn bà...)
4. **Family** - Xúc phạm gia đình (mẹ mày, bố mày, cả nhà mày...)
5. **Disability** - Kỳ thị khuyết tật (thiểu năng, câm, điếc...)
6. **Violence** - Bạo lực/Đe dọa (giết, chém, chết đi...)

#### Nguyên Tắc 3: Majority Voting (3 Annotators)

```python
# Quality control
if annotator_1 == annotator_2 == annotator_3:
    final_label = annotator_1  # Perfect agreement
elif annotator_1 == annotator_2:
    final_label = annotator_1  # Majority (2/3)
else:
    final_label = REVIEW_NEEDED  # Conflict
```

### Kết Quả Labeling

```
🎯 LABELING QUALITY
• Gold Standard: 1,127 samples
  ├─ Label 0 (Clean): 467 samples (41.4%)
  ├─ Label 1 (Offensive): 289 samples (25.7%)
  └─ Label 2 (Hate Speech): 371 samples (32.9%)

• Cohen's Kappa: 0.78 (Substantial Agreement)
• Inter-Annotator Agreement: 89.3%
```

### Active Learning: Giải Quyết Imbalanced Data

Ban đầu, Label 1 chỉ có **178 samples** (quá ít!). Tôi áp dụng **Active Learning**:

1. Train model sơ bộ với data hiện có
2. Model predict trên unlabeled data
3. Chọn những samples mà model **không chắc chắn** (confidence < 0.6)
4. Gán nhãn thủ công cho những samples này
5. Lặp lại

**Kết quả:** Tăng Label 1 từ 178 → 289 samples (+62%)! 🚀

> 💡 **Lesson 3:** Context-aware labeling là chìa khóa cho hate speech detection. Không có context, accuracy giảm từ 85% xuống 62%!

---

## 🤖 Phase 4: Model Training - PhoBERT To The Rescue

### Tại Sao Chọn PhoBERT?

**PhoBERT** (Phở + BERT) là mô hình BERT được pre-train trên 20GB text tiếng Việt:

```
✅ Hiểu tiếng Việt tốt nhất (so với mBERT, XLM-R)
✅ Pre-trained trên 20GB Vietnamese corpus
✅ Xử lý tốt word segmentation tiếng Việt
✅ State-of-the-art cho NLP tasks tiếng Việt
```

### Architecture: PhoBERT + Classification Head

```python
class HateSpeechClassifier(nn.Module):
    def __init__(self):
        self.phobert = AutoModel.from_pretrained("vinai/phobert-base")
        self.dropout = nn.Dropout(0.3)
        self.classifier = nn.Linear(768, 3)  # 3 labels
        
    def forward(self, input_ids, attention_mask):
        outputs = self.phobert(input_ids, attention_mask)
        pooled = outputs.pooler_output
        pooled = self.dropout(pooled)
        logits = self.classifier(pooled)
        return logits
```

### Training Strategy

**Hyperparameters:**
```python
BATCH_SIZE = 16
LEARNING_RATE = 2e-5
EPOCHS = 5
MAX_LENGTH = 256  # PhoBERT max
OPTIMIZER = AdamW
SCHEDULER = Linear warmup + decay
```

**Data Augmentation:**
- Back-translation (Vie → Eng → Vie)
- Synonym replacement (từ điển đồng nghĩa)
- Random deletion (xóa 10% từ ngẫu nhiên)

### Kết Quả Training

```
📊 FINAL RESULTS (Test Set)

Overall Metrics:
• Accuracy: 87.3%
• F1-Macro: 85.2%
• F1-Weighted: 86.8%

Per-Class Performance:
┌─────────┬───────────┬────────┬─────────┐
│ Label   │ Precision │ Recall │ F1      │
├─────────┼───────────┼────────┼─────────┤
│ 0 Clean │   89.4%   │ 91.2%  │  90.3%  │
│ 1 Offen │   82.1%   │ 78.9%  │  80.5%  │
│ 2 Hate  │   86.7%   │ 85.4%  │  86.0%  │
└─────────┴───────────┴────────┴─────────┘

Context Impact:
• With context: 85.2% F1-Macro
• Without context: 62.7% F1-Macro
• Improvement: +22.5% 🚀
```

**Confusion Matrix Analysis:**

Lỗi phổ biến nhất:
- Label 1 → Label 2: 12% (Model quá "nhạy cảm")
- Label 2 → Label 1: 8% (Model quá "dễ dãi")
- Label 0 → Label 1: 5% (False positive)

> 💡 **Lesson 4:** Context không chỉ là "nice to have", mà là **must have**. Thêm Post Title vào input tăng F1 lên 22.5%!

---

## 📊 Phase 5: Analysis - Những Phát Hiện Thú Vị

### Phát Hiện 1: "Đm" Không Phải Lúc Nào Cũng Là Hate Speech

Phân tích 1,000 comments chứa "đm":
- **78%** là Label 1 (Offensive) - Chỉ bày tỏ cảm xúc
- **22%** là Label 2 (Hate Speech) - Khi kết hợp với topic nhạy cảm

**Ví dụ:**
```
"Đm trời mưa quá" → Label 1
"Đm thằng bắc kỳ" → Label 2 (Region)
```

### Phát Hiện 2: Emoji 🏳️‍🌈 Là "High Signal" Cho LGBTQ+ Hate

Comments có emoji cờ LGBT:
- **89%** là Label 2 với Topic: LGBTQ+
- Chỉ **11%** là Label 0 (support)

### Phát Hiện 3: Regional Discrimination Là Topic Phổ Biến Nhất

```
📊 TOPIC DISTRIBUTION (Label 2)
1. Region: 38.2%
2. Body: 24.7%
3. Violence: 15.3%
4. Gender: 12.1%
5. Family: 6.8%
6. Disability: 2.9%
```

**Từ khóa phổ biến:**
- Region: "bắc kỳ" (67%), "3 que" (18%), "parky" (15%)
- Body: "béo" (45%), "xấu" (32%), "lùn" (12%)

### Phát Hiện 4: Teencode Intensity Preservation Hoạt Động!

So sánh 2 approaches:

**Approach 1: Normalize tất cả**
```python
"đm" → "địt mẹ"
"vcl" → "vãi cả lồn"
```
→ F1-Macro: 81.3%

**Approach 2: Intensity Preservation (Ours)**
```python
"đm" → "đm"  # Giữ nguyên
"vcl" → "vcl"  # Giữ nguyên
```
→ F1-Macro: 85.2% (+3.9%) 🎯

**Kết luận:** Giữ nguyên morphology giúp PhoBERT học được intensity gradient!

---

## 🛠️ Tech Stack: Công Nghệ Sử Dụng

### Data Collection Layer
- **Apify Platform** - Web scraping với anti-bot
- **Facebook Graph API** - Metadata extraction
- **YouTube Data API v3** - Comment collection

### Preprocessing Layer
```python
Core Libraries:
├─ pandas 2.0+ - Data manipulation
├─ regex (re) - Pattern matching
├─ unicodedata - Unicode normalization
└─ tqdm - Progress tracking

Custom Modules:
├─ advanced_text_cleaning.py - 8-step pipeline
├─ person_name_detector.py - Rule-based NER
└─ teencode_normalizer.py - 251+ rules
```

### Model Layer
```python
Deep Learning:
├─ PyTorch 2.0+ - Deep learning framework
├─ Transformers 4.30+ - PhoBERT model
├─ vinai/phobert-base - Pre-trained model
└─ scikit-learn - Metrics & evaluation

Training Infrastructure:
├─ CUDA 11.8 - GPU acceleration
├─ Mixed Precision (FP16) - Faster training
└─ Gradient Accumulation - Larger batch size
```

### Deployment (Future)
```python
API:
├─ FastAPI - REST API
├─ Uvicorn - ASGI server
└─ Docker - Containerization

Monitoring:
├─ Prometheus - Metrics
├─ Grafana - Visualization
└─ Sentry - Error tracking
```

---

## 💡 Lessons Learned: 6 Tháng Đổ Máu

### 1. Data Quality > Data Quantity

**Sai lầm ban đầu:** Tôi nghĩ cần 100K samples mới train được model tốt.

**Thực tế:** 12K samples **chất lượng cao** (context-aware, multi-annotator) tốt hơn 100K samples **chất lượng thấp**.

### 2. Preprocessing Là "Nghệ Thuật"

**Sai lầm:** Normalize tất cả teencode về dạng chuẩn.

**Bài học:** Phải hiểu **ngữ nghĩa** và **intensity**. "đm" ≠ "địt mẹ" về mặt ngữ cảnh sử dụng!

### 3. Context Là Chìa Khóa

**Sai lầm:** Train model chỉ với comment, không có Post Title.

**Bài học:** Thêm context tăng F1 lên **22.5%**. Đây là improvement lớn nhất!

### 4. Active Learning Giải Quyết Imbalanced Data

**Sai lầm:** Random sampling để gán nhãn.

**Bài học:** Dùng Active Learning để focus vào **hard examples** → Tăng Label 1 lên 62%!

### 5. Labeling Guideline Phải Cực Kỳ Chi Tiết

**Sai lầm:** Guideline V1 chỉ có 2 trang, mơ hồ.

**Bài học:** Guideline V3 có 15 trang với **100+ examples** → Cohen's Kappa tăng từ 0.52 lên 0.78!

### 6. Managed Services Tiết Kiệm Thời Gian

**Sai lầm:** Tự build crawler với Selenium.

**Bài học:** Chuyển sang Apify tiết kiệm **2 tháng** và tránh được vô số headaches!

---

## 🚀 Impact & Future Plans

### Tác Động Thực Tế

**SafeSense-Vi** có thể ứng dụng cho:

1. **Social Media Moderation**
   - Tự động phát hiện và cảnh báo nội dung độc hại
   - Bảo vệ người dùng khỏi hate speech

2. **Content Filtering**
   - Lọc bình luận toxic cho các nền tảng
   - Tạo môi trường mạng lành mạnh hơn

3. **Research & Development**
   - Dataset phục vụ cộng đồng NLP Việt Nam
   - Benchmark cho hate speech detection

### Roadmap Tương Lai

**Short-term (3 tháng):**
- [ ] REST API deployment với FastAPI
- [ ] Real-time inference (\< 100ms)
- [ ] Multi-label classification (1 comment nhiều topics)
- [ ] Explainability (LIME, SHAP)

**Mid-term (6 tháng):**
- [ ] Multi-modal analysis (text + image)
- [ ] Regional dialect adaptation (Bắc, Trung, Nam)
- [ ] Mobile SDK (iOS, Android)
- [ ] Browser extension (Chrome, Firefox)

**Long-term (1 năm):**
- [ ] Cross-lingual hate speech detection (Vie, Eng, Thai)
- [ ] Generative AI for counter-speech
- [ ] Commercial SaaS platform
- [ ] Integration với Facebook, YouTube APIs

---

## 🎯 Kết Luận: Từ 0 Đến 12K Samples

**SafeSense-Vi** là một case study về việc xây dựng AI system từ đầu:

✅ **Data Engineering** - Crawl 38K comments, xử lý 251+ teencode rules  
✅ **Data Science** - Context-aware labeling, Active Learning  
✅ **Deep Learning** - PhoBERT fine-tuning, 85% F1-Macro  
✅ **Research** - Intensity preservation, context impact analysis  
✅ **Production-Ready** - 8-step pipeline, quality control  

### Key Takeaways

1. **Context is king** - Thêm Post Title tăng F1 lên 22.5%
2. **Quality > Quantity** - 12K samples chất lượng cao > 100K samples rác
3. **Preprocessing is art** - Intensity preservation quan trọng hơn normalization
4. **Active Learning works** - Giải quyết imbalanced data hiệu quả
5. **Managed services save time** - Apify tiết kiệm 2 tháng development

### Đóng Góp Cho Cộng Đồng

Dự án này đóng góp:
- 📊 **12,695 samples dataset** - Largest Vietnamese hate speech dataset
- 📚 **Labeling methodology** - Context-aware approach
- 🛠️ **Preprocessing pipeline** - Reusable cho NLP tiếng Việt
- 🧠 **Research insights** - Intensity preservation, context impact

---

## 📚 Tài Liệu Tham Khảo

### Technical Documentation

- [PhoBERT Paper](https://arxiv.org/abs/2003.00744) - Pre-training PhoBERT
- [Hate Speech Detection Survey](https://arxiv.org/abs/2004.06465) - SOTA methods
- [Active Learning for NLP](https://arxiv.org/abs/2104.08320) - Best practices

### Tools & Libraries

- [Apify Platform](https://apify.com) - Web scraping
- [Hugging Face Transformers](https://huggingface.co/transformers) - PhoBERT
- [PyTorch](https://pytorch.org) - Deep learning framework

### Vietnamese NLP Resources

- [VnCoreNLP](https://github.com/vncorenlp/VnCoreNLP) - Vietnamese NLP toolkit
- [PhoBERT](https://github.com/VinAIResearch/PhoBERT) - Vietnamese BERT
- [ViText](https://github.com/undertheseanlp/underthesea) - Vietnamese text processing

---

## 🤝 Liên Hệ & Đóng Góp

**GitHub Repository:**  
⭐ [github.com/ThienIT84/vietnamese-hate-speech-dataset](https://github.com/ThienIT84/vietnamese-hate-speech-dataset)

**Dataset:**  
📊 12,695 labeled samples (CC BY-SA 4.0 License)

**Contact:**  
📧 Email: thientt@example.com  
💼 LinkedIn: [linkedin.com/in/thientt](https://linkedin.com/in/thientt)  
🐦 Twitter: [@thientt_dev](https://twitter.com/thientt_dev)

---

**Nếu bạn thấy dự án này hữu ích, hãy cho mình một ⭐ trên GitHub!**

*Bài viết được viết bởi Trần Thanh Thiện - AI Engineer*  
*Dự án SafeSense-Vi - Phát hiện ngôn từ thù ghét tiếng Việt 2025*
