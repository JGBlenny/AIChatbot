# LLM Provider 混合配置指南

**更新日期:** 2026-02-14
**版本:** 2.0 - 支援混合 Provider 配置
**作者:** Claude Code

---

## 📋 目錄

1. [概述](#概述)
2. [為什麼需要混合配置？](#為什麼需要混合配置)
3. [配置方式](#配置方式)
4. [使用範例](#使用範例)
5. [成本優化方案](#成本優化方案)
6. [遷移步驟](#遷移步驟)

---

## 概述

LLM Provider 現在支援**混合配置**，允許不同服務使用不同的 LLM Provider，實現**成本優化**和**靈活部署**。

### 支援的配置模式

| 模式 | 說明 | 適用場景 |
|------|------|---------|
| **單一 Provider** | 所有服務使用同一個 Provider | 簡單部署、開發測試 |
| **混合 Provider** | 不同服務使用不同 Provider | 成本優化、生產環境 |

### 支援的 Provider

- **OpenAI**: 官方 API，品質最高
- **OpenRouter**: 第三方聚合，成本較低
- **Ollama**: 本地部署，完全免費

---

## 為什麼需要混合配置？

### 成本分析（以日均 1,000 queries 為例）

| 服務 | 成本佔比 | 月成本 (OpenAI) | 推薦 Provider | 月成本 (優化後) |
|------|---------|----------------|---------------|----------------|
| 答案優化 | 58% | $3.17 | OpenRouter + Claude | $1.50 |
| 意圖分類 | 30% | $1.65 | OpenRouter + Mistral | $0.50 |
| 文件轉換 | 10% | $0.55 | Ollama (本地) | $0.10 |
| 知識生成 | 1% | $0.08 | Ollama (本地) | $0.01 |
| Embedding | 0.2% | $0.01 | Ollama (本地) | $0.005 |
| **總計** | **100%** | **$5.46** | **混合方案** | **$2.11** |

**成本節約**: 61% ($3.35/月)

---

## 配置方式

### 1. 全域配置 (單一 Provider)

在 `.env` 設定全域 Provider，所有服務都使用相同配置：

```bash
# 全域 Provider
LLM_PROVIDER=openai

# API Key
OPENAI_API_KEY=sk-proj-your-api-key
```

### 2. 混合配置 (推薦)

為每個服務指定專屬 Provider：

```bash
# ============================================================
# 全域預設 Provider（未指定時使用）
# ============================================================
LLM_PROVIDER=openai

# ============================================================
# 服務專屬 Provider 配置
# ⚠️ 只有「有傳 service_name」的呼叫端才會查這一層。
#    目前全 repo 只有一個：services/query_rewriter.py
# ============================================================

# 查詢改寫（唯一可用的服務專屬鍵）
QUERY_REWRITER_PROVIDER=openrouter

# ============================================================
# API Keys
# ============================================================
OPENAI_API_KEY=sk-proj-...
OPENROUTER_API_KEY=sk-or-...
OLLAMA_API_URL=http://localhost:11434
```

### 配置優先級

```
服務專屬配置 > 全域配置 > 預設值 (openai)
```

範例：
```bash
# 若設定：
LLM_PROVIDER=openai
QUERY_REWRITER_PROVIDER=openrouter

# 則：
- QueryRewriter → 使用 OpenRouter
- 其他呼叫端 → 使用 OpenAI (全域預設)
```

---

## 使用範例

### 程式碼中使用

```python
from services.llm_provider import get_llm_provider

# 方式 1: 自動根據服務名稱選擇 Provider
class QueryRewriter:
    def __init__(self):
        # 會查找 QUERY_REWRITER_PROVIDER
        self.llm_provider = get_llm_provider(service_name='query_rewriter')

# 方式 2: 手動指定 Provider
class CustomService:
    def __init__(self):
        # 強制使用 OpenRouter
        self.llm_provider = get_llm_provider(provider_type='openrouter')

# 方式 3: 使用全域預設
class AnotherService:
    def __init__(self):
        # 使用 LLM_PROVIDER 的設定
        self.llm_provider = get_llm_provider()
```

### 支援的 service_name

🔴 **2026-09-12 逐一對碼：全 repo 只有一個呼叫端傳 `service_name`。**
`{SERVICE}_PROVIDER` 是 `get_llm_provider(service_name=...)` 動態拼出來的
（`env_key = f"{service_name.upper()}_PROVIDER"`），**沒有呼叫端傳就沒有那個鍵**。

| service_name | 對應環境變數 | 呼叫端 |
|-------------|-------------|---------|
| `query_rewriter` | `QUERY_REWRITER_PROVIDER` | `services/query_rewriter.py` |

其餘呼叫端（`app.py`、`knowledge_import_service.py`、`document_converter_service.py`、
`tools/agent_eval.py`）都是無參數 `get_llm_provider()` ⇒ **只吃全域 `LLM_PROVIDER`**。
查證：`grep -rn "get_llm_provider(" rag-orchestrator --include="*.py" | grep -v /tests/`

---

## 成本優化方案

### 方案 A: 部分遷移 OpenRouter（推薦新手）

**難度**: ⭐⭐
**實施時間**: 1 天
**成本節約**: 40%

```bash
LLM_PROVIDER=openai
QUERY_REWRITER_PROVIDER=openrouter  # 遷移查詢改寫（唯一可單獨切換的服務）
OPENROUTER_API_KEY=sk-or-...
```

**優點**:
- 低風險，只遷移次要服務
- 立即見效

**缺點**:
- 節約有限

---

### 方案 B: 全面混合方案（推薦生產）

**難度**: ⭐⭐⭐
**實施時間**: 1 週
**成本節約**: 60-70%

```bash
# 全域走 Ollama（知識匯入／文件轉換／回測工具都吃這顆）
LLM_PROVIDER=ollama

# 查詢改寫單獨留在雲端（唯一可單獨切換的服務）
QUERY_REWRITER_PROVIDER=openrouter

⚠️ 想「按服務分」必須先在該服務的 get_llm_provider() 補上 service_name 參數，
   ⛔ 光設環境變數不會生效。
```

**優點**:
- 成本大幅降低
- 高品質服務仍用雲端 API
- 非關鍵任務本地化

**缺點**:
- 需要部署 Ollama 服務
- 維護複雜度增加

---

### 方案 C: 全本地化（推薦自主控制）

**難度**: ⭐⭐⭐⭐
**實施時間**: 2 週
**成本節約**: 80%+

```bash
LLM_PROVIDER=ollama
OLLAMA_API_URL=http://localhost:11434
```

**優點**:
- 完全自主控制
- 隱私保護
- 長期成本最低

**缺點**:
- 需要GPU伺服器
- 模型品質需驗證
- DevOps 維護成本

---

## 遷移步驟

### Step 1: 設置 OpenRouter 帳戶

1. 註冊 OpenRouter: https://openrouter.ai/
2. 獲取 API Key
3. 在 `.env` 添加 `OPENROUTER_API_KEY`

### Step 2: 部署 Ollama（選擇性）

```bash
# macOS / Linux
curl -fsSL https://ollama.com/install.sh | sh

# 啟動 Ollama
ollama serve

# 下載模型
ollama pull mistral          # 輕量級模型
ollama pull llama3:70b       # 大型模型
ollama pull nomic-embed-text # Embedding 模型
```

### Step 3: 修改 .env 配置

```bash
# 開始時全用 OpenAI
LLM_PROVIDER=openai

# 逐步遷移（第一週）——唯一可單獨切換的服務
QUERY_REWRITER_PROVIDER=openrouter

# 進階遷移（第二週）：其餘呼叫端只吃全域值
LLM_PROVIDER=ollama
```

### Step 4: 測試驗證

```bash
# 執行集成測試
python3 /tmp/test_llm_provider_integration.py

# 測試混合配置
python3 /tmp/test_mixed_provider_config.py
```

### Step 5: 監控成本與品質

- 監控 API 成本
- 比較回應品質
- 調整配置

---

## 常見問題

### Q1: 不同 Provider 的品質差異？

**A**:
- **OpenAI GPT-4**: 最高品質，適合關鍵任務
- **OpenRouter Claude**: 品質接近 GPT-4，成本較低
- **OpenRouter Mistral**: 中等品質，成本很低
- **Ollama Llama3**: 本地部署，品質取決於模型大小

### Q2: 如何確保服務穩定性？

**A**:
- 保留 OpenAI 作為備用（Fallback）
- 重要服務優先使用雲端 API
- 非關鍵任務才本地化

### Q3: 混合配置會增加延遲嗎？

**A**:
- Provider 緩存機制確保效能
- 本地 Ollama 延遲更低
- OpenRouter 延遲略高於 OpenAI（約 +100-200ms）

### Q4: 如何回滾到原始配置？

**A**:
```bash
# 移除所有服務專屬配置
# 只保留全域配置
LLM_PROVIDER=openai
OPENAI_API_KEY=sk-proj-...

# 註解或刪除服務專屬配置
# QUERY_REWRITER_PROVIDER=...
```

---

## 技術細節

### Provider 緩存機制

```python
# 系統會緩存 Provider 實例
_provider_cache = {
    'openai': OpenAIProvider(),
    'openrouter': OpenRouterProvider(),
    'ollama': OllamaProvider()
}

# 多次調用返回相同實例
provider1 = get_llm_provider(service_name='intent_classifier')
provider2 = get_llm_provider(service_name='intent_classifier')
assert id(provider1) == id(provider2)  # True
```

### 環境變數查找邏輯

```python
def get_llm_provider(service_name=None):
    if service_name:
        # 1. 查找服務專屬配置
        provider_type = os.getenv(f"{service_name.upper()}_PROVIDER")

    if not provider_type:
        # 2. 使用全域配置
        provider_type = os.getenv("LLM_PROVIDER")

    if not provider_type:
        # 3. 使用預設值
        provider_type = "openai"

    return _get_or_create_provider(provider_type)
```

---

## 總結

✅ **已完成**:
- LLM Provider 抽象層 (100%)
- 混合 Provider 配置支援
- Provider 緩存機制
- 完整測試驗證

🎯 **建議行動**:
1. **現在**: 維持全 OpenAI（穩定優先）
2. **1 週內**: 遷移意圖分類到 OpenRouter
3. **2 週內**: 部署 Ollama，遷移 Embedding
4. **1 個月**: 全面混合方案，節約 60% 成本

💰 **預期效益**:
- 第一階段（OpenRouter）: 節約 30-40% → **$3.50/月**
- 第二階段（混合方案）: 節約 60-70% → **$2.00/月**
- 第三階段（全本地化）: 節約 80%+ → **$1.00/月**

---

**文檔更新**: 2026-02-14
**下次審查**: 2026-03-14
