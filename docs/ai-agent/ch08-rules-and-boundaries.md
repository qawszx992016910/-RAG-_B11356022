# Ch08 — 紅線與護欄：語意禁止與人類審查

> **「好的系統不是讓人不犯錯，而是讓犯錯變得困難。」**

---

## 🎯 本章學習目標

讀完這章，你將能夠：

- [ ] 設計語意禁止規則（Semantic Deny）
- [ ] 建立人類審查觸發機制（Human Review Triggers）
- [ ] 區分三個審查級別的適用場景
- [ ] 為你的專案寫出具體的紅線規則

---

## 憲法 vs 紅線

上一章的「憲法」定義了**大方向**（做什麼），
這一章的「紅線」定義了**具體限制**（不能做什麼）。

```
憲法（Ch07）：「我們重視安全」    ← 原則，方向性
    │
    ▼
紅線（Ch08）：「禁止在程式碼中      ← 具體，可執行
               硬編碼任何密鑰」
```

---

## 語意禁止規則（Semantic Deny）

### 什麼是語意禁止？

語意禁止是**在程式碼層級**的絕對禁令。不管是人類還是 Agent，都不能違反。

```
與一般規則的差別：

一般規則：「應該避免使用 any」      ← 有彈性，可能被忽略
語意禁止：「絕對禁止使用 any」      ← 零容忍，沒有例外
```

### 四大類禁止規則

參考 `agent-init/rules/semantic-deny.md`：

#### 1. 通用規則（GEN）

```yaml
GEN-001: 禁止無理由的 @ts-ignore
  觸發: 程式碼中出現 @ts-ignore 但沒有解釋註解
  理由: 關閉型別檢查等於放棄型別安全
  替代: 找到根本原因並修復型別問題

GEN-002: 禁止功能重複的套件
  觸發: 安裝與現有套件功能相同的新套件
  理由: 增加 bundle size 和維護成本
  替代: 使用已安裝的套件

GEN-003: 禁止 console.log 進入 production
  觸發: 非開發環境的程式碼中有 console.log
  理由: 洩露內部資訊，影響效能
  替代: 使用正式的 logger 服務

GEN-004: 禁止硬編碼密鑰
  觸發: 程式碼中包含 API key、密碼、token 等
  理由: 密鑰進入 Git 歷史後幾乎無法完全刪除
  替代: 使用 .env 和環境變數
```

#### 2. 資料庫規則（DB）

```yaml
DB-001: 禁止繞過 ORM 直接寫 SQL
  觸發: 使用 raw SQL 而非 ORM 方法
  理由: 繞過 ORM 的安全機制（SQL injection 防護）
  例外: 效能關鍵查詢，但需人類審查

DB-002: 禁止前端存放 admin 金鑰
  觸發: 客戶端程式碼中出現資料庫或 admin 密鑰
  理由: 前端程式碼完全暴露給使用者
  替代: 透過後端 API 存取

DB-003: 禁止不帶 IF EXISTS 的 DROP
  觸發: DROP TABLE/INDEX 語句不帶安全檢查
  理由: 在目標不存在時會導致錯誤
  替代: DROP TABLE IF EXISTS
```

#### 3. 安全規則（SEC）

```yaml
SEC-001: 禁止 eval/exec 執行動態程式碼
  觸發: 使用 eval()、new Function()、exec()
  理由: 遠端程式碼執行（RCE）風險
  替代: 使用安全的替代方案

SEC-002: 禁止明文儲存密碼
  觸發: 將密碼直接存入資料庫
  理由: 資料外洩時密碼直接暴露
  替代: bcrypt/argon2 雜湊

SEC-003: 禁止無限制 CORS
  觸發: CORS 設定為 Access-Control-Allow-Origin: *
  理由: 允許任何網站存取你的 API
  替代: 明確列出允許的 origin
```

#### 4. 架構規則（AR）

```yaml
AR-001: 禁止循環依賴
  觸發: 模組 A 依賴 B，B 又依賴 A
  理由: 增加耦合度，使模組無法獨立測試
  替代: 提取共用邏輯到第三個模組

AR-002: 禁止 God Object（>500 行）
  觸發: 單一檔案超過 500 行
  理由: 違反單一職責，難以維護
  替代: 拆分為多個專注的模組

AR-003: 禁止跳過 Linter
  觸發: eslint-disable 沒有附帶理由
  理由: Linter 規則是程式碼品質的底線
  替代: 修正問題而非禁用規則
```

#### 5. 供應鏈安全規則（SUPPLY）

> 🧠 **為什麼需要這個？** 2025 年最常見的攻擊手法之一是「供應鏈攻擊」——
> 攻擊者上傳名稱相似的惡意套件到 npm/PyPI，等你打錯字就中招。
> Agent 安裝套件的速度比人快 100 倍，所以更需要護欄。

```yaml
SUPPLY-001: 禁止安裝名稱可疑的套件（typosquatting）
  觸發: 新增的套件名稱與知名套件相似（如 lod-ash vs lodash）
  理由: 可能是冒名的惡意套件
  偵測: 比對 Levenshtein 距離、檢查下載量與發佈歷史
  替代: 確認拼寫正確，檢查套件的 npm/PyPI 頁面

SUPPLY-002: 禁止從非官方 Registry 安裝
  觸發: .npmrc / pip.conf 指向非官方來源，或使用 git+https:// 安裝
  理由: 非官方來源的套件缺乏安全審核
  替代: 使用官方 registry（npm、PyPI、crates.io）

SUPPLY-003: 禁止安裝有 postinstall 腳本的未知套件
  觸發: 新套件的 package.json 包含 postinstall/preinstall scripts
  理由: 生命週期腳本可在安裝時執行任意程式碼
  替代: 審查腳本內容，或使用已知安全的套件

SUPPLY-004: 禁止 pin 到已知有漏洞的版本
  觸發: 依賴版本包含 critical/high severity CVE
  理由: 已知漏洞是低懸果實攻擊目標
  偵測: npm audit / pip audit / cargo audit
```

> 💡 **Semgrep 自動化**：`SUPPLY` 和其他 `semantic-deny` 規則可以用 Semgrep
> 轉成 CI 管線中的自動化檢查。範本在 `agent-init/config/semgrep-deny.yaml`。

---

## 人類審查觸發機制（Human Review Triggers）

### 三級審查系統

不是所有操作都需要同等級的人類介入。
三級系統讓你精確控制「什麼時候需要人類」。

```
┌──────────────────────────────────────────────────┐
│                                                    │
│  🔴 L1 — 必須停止（MUST STOP）                     │
│  ════════════════════════════                      │
│  Agent 必須立即停止，等待人類明確核准。              │
│  這些是高風險、不可逆或影響安全的操作。              │
│                                                    │
│  🟡 L2 — 應該確認（SHOULD CONFIRM）                │
│  ════════════════════════════════                  │
│  Agent 通知人類並等待確認，但可以預先準備。          │
│  這些是中等風險、可能有副作用的操作。                │
│                                                    │
│  🟢 L3 — 事後通知（NOTIFY AFTER）                  │
│  ════════════════════════════════                  │
│  Agent 可以直接執行，但必須在完成後立即通知人類。    │
│  這些是低風險但人類需要知道的操作。                  │
│                                                    │
└──────────────────────────────────────────────────┘
```

### L1：必須停止的操作

```
🔴 資料庫遷移（DB Migration）
   → 影響所有資料，不可逆
   → Agent 必須先展示遷移腳本，人類確認後才執行

🔴 認證/授權系統修改
   → 影響安全性
   → 任何對 auth 模組的修改都需要人類審查

🔴 治理文件修改
   → 影響整個治理框架
   → constitution.md、semantic-deny 等文件的修改需要審核

🔴 支付系統修改
   → 涉及金錢，錯誤代價極高
   → 任何涉及金流的修改都需要人類確認

🔴 刪除核心目錄
   → 不可逆操作
   → rm -rf src/ 或類似操作永遠需要確認
```

### L2：應該確認的操作

```
🟡 新增外部依賴
   → 可能引入安全風險或增加 bundle size
   → Agent 告知套件名稱、用途、大小，等待確認

🟡 修改 API 路由
   → 可能影響前端或其他服務
   → Agent 展示變更和影響範圍，等待確認

🟡 刪除測試
   → 可能降低覆蓋率
   → Agent 說明為什麼要刪，等待確認

🟡 修改環境變數
   → 可能影響部署配置
   → Agent 展示變更內容，等待確認
```

### L3：事後通知的操作

```
🟢 修改規則文件
   → 低風險但需要知道
   → Agent 執行後告知修改內容

🟢 大量重新命名
   → 功能不變但可能影響認知
   → Agent 執行後提供變更摘要

🟢 修改樣式檔案
   → 影響外觀但不影響功能
   → Agent 執行後附上截圖或 diff
```

---

## 如何撰寫紅線規則

### 好的規則 vs 壞的規則

```
✅ 好的規則：
   「禁止在 src/client/ 目錄的任何檔案中
    引用 process.env 中的 DATABASE_URL」
   → 具體、可驗證、有明確範圍

❌ 壞的規則：
   「寫安全的程式碼」
   → 太模糊、無法驗證、沒有具體標準
```

### 撰寫模板

```yaml
ID: [類別]-[編號]
名稱: [規則名稱]
級別: deny（禁止）| warn（警告）| review（需審查）
觸發: [什麼情況會觸發這個規則]
理由: [為什麼需要這個規則]
替代: [應該怎麼做]
例外: [如果有合理例外]
```

### 範例：為電商專案撰寫規則

```yaml
# 電商專案特定規則

EC-001:
  名稱: 禁止前端直接處理金額計算
  級別: deny
  觸發: 客戶端程式碼中出現價格乘除運算
  理由: 浮點數精度問題可能導致金額錯誤
  替代: 所有金額計算在後端使用 Decimal 型別
  例外: 無

EC-002:
  名稱: 庫存扣減必須使用原子操作
  級別: deny
  觸發: 庫存更新使用 read-then-write 模式
  理由: 並發下單可能導致超賣
  替代: 使用 DB 層級的原子操作（UPDATE ... SET stock = stock - 1）
  例外: 無

EC-003:
  名稱: 訂單狀態變更需要審查
  級別: review (L1)
  觸發: 修改訂單狀態機的轉換邏輯
  理由: 影響所有訂單流程
  替代: 先在 staging 環境驗證
  例外: 無
```

---

## 規則的執行機制

### 自動化檢查

把規則轉化為可以自動執行的檢查：

```javascript
// 範例：pre-commit hook 檢查硬編碼密鑰
// .husky/pre-commit

#!/bin/sh
# 檢查是否有硬編碼的密鑰
if git diff --cached | grep -E "(api_key|secret|password|token)\s*=\s*['\"]"; then
  echo "❌ 發現疑似硬編碼的密鑰！"
  echo "   請使用環境變數代替。"
  exit 1
fi
```

### Governance Gates（治理閘門）

更進階的自動化規則，使用 YAML 格式定義：

```yaml
# skills/governance/contract_first_gate.yaml
name: 契約優先閘門
trigger:
  - file_changed: "prisma/schema.prisma"
  - file_changed: "src/api/**/*.ts"
check:
  - exists: "docs/contracts/{{module}}.md"
  - updated_after: "prisma/schema.prisma"
action:
  fail: "API/Schema 變更必須先更新契約文件"
```

---

## 實戰：設計你的規則系統

### Step 1：列出你的「災難清單」

回答這個問題：**「什麼操作會讓你的專案陷入災難？」**

```
範例清單：
1. 刪除 production 資料庫的資料
2. 推送未測試的程式碼到 main
3. 洩露 API 金鑰
4. 打壞認證系統
5. 引入有漏洞的依賴
6. 覆蓋同事的工作
```

### Step 2：分級分類

把每個災難對應到適當的層級：

| 災難 | 層級 | 規則類型 |
|------|------|---------|
| 刪除 production 資料 | L1 MUST STOP | 操作禁止 |
| 未測試推送到 main | L3 語意禁止 | Semantic Deny |
| 洩露 API 金鑰 | L3 語意禁止 | Semantic Deny |
| 打壞認證系統 | L1 MUST STOP | Human Review |
| 引入有漏洞依賴 | L2 SHOULD CONFIRM | Human Review |
| 覆蓋同事工作 | L3 語意禁止 | Git 規則 |

### Step 3：撰寫規則文件

建立 `rules/semantic-deny.md`：

```markdown
# 語意禁止規則

## 程式碼層級

### GEN-001: 禁止 any 型別
- 觸發：TypeScript 程式碼中出現 `any`
- 替代：使用具體型別或 `unknown`

### GEN-002: 禁止 console.log
- 觸發：非 test 檔案中的 `console.log`
- 替代：使用 `logger.info/warn/error`

## 安全層級

### SEC-001: 禁止硬編碼密鑰
- 觸發：程式碼中出現密碼、API key
- 替代：使用 `process.env`

## 架構層級

### AR-001: 禁止循環依賴
- 觸發：模組間的循環引用
- 替代：提取共用模組
```

建立 `rules/human-review-triggers.md`：

```markdown
# 人類審查觸發規則

## L1 — 必須停止
- [ ] DB Migration
- [ ] Auth 系統修改
- [ ] 支付邏輯修改
- [ ] 刪除核心目錄

## L2 — 應該確認
- [ ] 新增外部依賴
- [ ] API 路由修改
- [ ] 刪除測試
- [ ] 環境變數修改

## L3 — 事後通知
- [ ] 規則文件修改
- [ ] 大量重新命名
- [ ] 樣式修改
```

---

## 章末練習

### 🧪 動手做

1. **災難清單**：列出你專案中 5 個最可怕的「災難場景」。

2. **語意禁止規則**：為你的專案寫 5 條語意禁止規則（Semantic Deny），
   每條包含：ID、觸發條件、理由、替代方案。

3. **審查機制**：為你的專案設計 L1/L2/L3 三級審查機制，
   每級至少列出 3 個觸發條件。

### 🤔 思考題

1. 如果 Agent 遇到一個模糊的情況（不確定是否觸發了禁止規則），
   它應該怎麼做？
2. 規則太多會不會降低 Agent 的效率？如何找到平衡？
3. 什麼時候一個「語意禁止」規則應該被放寬為「需審查」？

---

## 關鍵概念回顧

| 概念 | 一句話總結 |
|------|-----------|
| Semantic Deny | 程式碼層級的絕對禁令，零容忍 |
| Human Review | 三級審查機制，精確控制人類介入時機 |
| L1 MUST STOP | 高風險操作，必須人類核准 |
| L2 SHOULD CONFIRM | 中風險操作，需要人類確認 |
| L3 NOTIFY AFTER | 低風險操作，事後通知即可 |
| Governance Gates | 自動化的規則執行機制 |

---

> **下一章預告**：[Ch09 — 記憶與決策：Agent 如何記住與成長](ch09-memory-and-decisions.md)
>
> 有了原則和紅線，Agent 知道「該做什麼」和「不該做什麼」了。
> 但它要如何記住過去的決策？如何從經驗中學習？
