# 組長核定事項（2026-10-21）

來源：組員 B 提出的「需要組長核定的事項」清單。組長於 2026-10-21 回覆「照建議」核定下列各項。

## 一、估值與 DCF

| 項目 | 核定 | 備註 |
|---|---|---|
| WACC | **9%**，全專案統一 | 與 `main.py`、手冊第 02 章一致；`valuation_agent/dcf_model.py` 預設已由 10% 改為 9%。報告標註「程式預設，非個股風險估計」。B 的 `data-contract.md` 第 229 行（WACC 10%、內在價值 853.27 元）需以 9% 重算 |
| 終端成長率 g | 3% | 程式強制 WACC > g |
| FCF 預測 | 基準情境：5 年持平於基期 TTM FCF；成長率情境列入敏感度 | 終端價值占比高，敏感度必須呈現 |
| DCF 公式 | 以 `dcf_model.py` 為專案標準：終端價值 = 第 5 年 FCF ×(1+g)/(WACC−g)，折現 5 年 | |
| 估值差距 ±15% | 保留（手冊 F03 規定） | 介面註明「專題顯示門檻，非經驗證投資規則」；缺關鍵參數顯示「無法判定」 |

## 二、資料口徑

| 項目 | 核定 |
|---|---|
| Supabase 路徑應付短期票券 | 採選項 (a)：年度 DCF 不計入，文件註明差異（2317 約 934.59 億） |
| 租賃負債 | 不計入淨負債，文件註明（非 IFRS 16 口徑） |
| shares_outstanding | 流通在外股數 = 發行股數 − 庫藏股（需通知 A、D） |
| BVPS | 歸屬母公司權益 ÷ 流通在外股數 |
| 單季 EPS 來源 | 2025Q4 採 FinMind 單季值（經全年減 1–9 月驗證），標籤 `finmind_quarterly` 為正式規則 |
| 淨負債缺值 | 不得以 0 代替；DCF 每股價值顯示「無法判定」（`main.py` 已修正，commit 3292570） |

## 三、測試與案例

| 項目 | 核定 |
|---|---|
| 開發案例 | 以 dev-cases.json **v1.5**（v1.5-w04，CASE-08 依手冊附表為 2317）為準；10/21、10/22 的 live 皆在 v1.5 上執行（檔名 dev-v14-* 為命名誤植，2026-10-22 更正） |
| CASE-11 | 採選項二：測試口徑識別，不寫個體數字 |
| 保留集 | 20 個快照已在 `fixtures/test/`，SEAL.json 三個檔案 hash 皆相符（2026-10-21 驗證）。是否殘留舊假數字由 B 或 D 確認；組長不讀保留集內容 |
| 股價 available_at | **全專案統一 17:30**（收盤後資料可得的推定時間）。原記錄「14:30 較保守」有誤：14:30 早於 17:30，反而較不保守（B 指正，2026-10-22 更正）；兩者皆早於 30 案 cutoff，不影響案例 |
| 表格整理段落 | 接受 `paragraph_type` 為「MOPS 表格數值整理」，數字須與原表逐字一致 |

## 四、程式與系統

| 項目 | 狀態 |
|---|---|
| CASE-15 正文不可讀 | 已修：回傳 `status: "unreadable"`（與 B 的 tools_impl 同格式） |
| CASE-26 工具逾時模擬 | 已修：快照層讀取 `tool_simulation`，並套用 B 的 15 秒逾時；工具時間計入 180 秒上限 |
| `fundamental_uploader.py` | 目前為 insert（非 upsert），重跑會重複。待 Supabase 測試專案確認 `(stock_code, year)` 唯一索引後改為 upsert |
| `report_downloader.py` 部署 | 排在 W08 部署驗收，先在測試專案驗證 |

## 五、2026-10-22 追加核定

| 項目 | 核定 |
|---|---|
| F06 2D 關聯圖 | **延後**，轉後續版本（理由見 W06-gate-v12.md 第 4 節）；N06 不驗收 |
| 2317 FCF 正常化情境 | **不做**；2317 基準情境維持「TTM FCF 為負，DCF 無法判定」 |

## 六、2026-10-23 核定

| 項目 | 核定 |
|---|---|
| model | 維持 `gemini-3.5-flash-lite` |
| 凍結 | 10/23 凍結案例／資料／評分規則；prompt 與 Agent 程式 10/26 live 再驗一次後鎖定（W09 前） |
| 備案 | Reviewer 仍無法完成覆核時，thinking_level minimal → low，只用開發集驗證 |

## 七、2026-10-24 核定（回覆 B 10/24 待決事項）

| 項目 | 核定 |
|---|---|
| 第一段凍結（案例、資料、B 工具、D 評分規則） | **可以凍結**。B 重新產生凍結紀錄，D 簽核後組長在 `data-freeze.md` 第七節簽核。第二段檔案清單維持 B 所列 |
| CASE-26 測不到逾時 | 不改快照（避免 cases-v2）；結果註明「此案未觸發逾時」，逾時處理以離線測試為證 |
| 覆核規則 basis_unspecified | 採用（來源 basis = unspecified 時列 critical）；10/26 與 workflow 模式一起合併，三模式校準開跑前生效 |
| CR-W06 保留集防護（`agents/snapshot.py`） | 10/26 合併（不等 W10），連同 B 的測試檔 |
| Supabase 寫入方式（data-contract 待決第 4 項） | 加 `(stock_code, year)` 唯一索引，改為資料庫層級 upsert；W07 先在 Supabase 測試專案上做，不動正式庫 |
| 年度 PER 來源（data-contract 待決第 12 項） | 保留；輸出標明「年度 PER（12/31 股價 ÷ 年度 EPS）」，不得與 F02 P/E 直接比較 |
| `tests/fixtures/agent_case_fixtures.json` snap-dev-case-01 | 改標 `synthetic_fixture: true`（6,735 億為早期合成數字） |


## 八、2026-10-29 核定

| 項目 | 核定 |
|---|---|
| 覆核規則：數字必須出現在引用來源（B 10/28 提出） | 採用。事實主張的數字若引用財報快照（`snap-…`）、工具結果（`obs-…`），或未填 source_ref，也要在快照工具數值、工具結果或引用原文中找得到，否則列 critical；允許常見單位換算（千元／萬／億／百分比）與依主張位數的四捨五入。算出來的數字（ytd 還原、有 operation／derived_inputs、P/E）由原有重算規則檢查。屬第二段（`agents/review_checks.py`、`agents/snapshot.py`），10/29 16:30 校準第 2 天前生效；第 1 天 dual 於第 6 天重跑，故校準的 dual 全部使用同一套規則 |
| 前瞻方向命中：零報酬（D 10/29 請登記） | 觀察期報酬恰為 0 記 `zero_return`，不計入方向命中率的分子與分母；報告另列筆數並註明「零報酬不判方向」。與 `scripts/forward_eval.py` 現行做法一致 |

## 9. 2026-10-31 組長決定：dual 誤擋的兩個修正

依校準第 2、4 天結果（本段程式修改，第 5 天起生效，Reviewer prompt 升為 `reviewer-v1.2.1`）：

- **TTM 季度判定（CASE-22）**：`quarters` 沒填時改讀 `period`，四季清單或 `2025Q3-2026Q2` 起訖都可判定；仍必須剛好連續四季，數字仍要對得上工具結果。凍結資料與 B 的工具都沒有改。
- **可得時間比對（CASE-11）**：`available_at`／`captured_at` 與 `cutoff_at` 的先後改由程式比對，prompt 要求模型不自行比較。模型若仍列時間問題，而引用來源經程式確認都在 cutoff 前可得，該問題移除，並記 `timing_issue_refuted` 事件（含模型原判與原文）供評分查核；若因此沒有其他 critical，模型結論改為 pass，最終仍由規則把關。
- **校準影響**：第 1–4 天的 dual 是舊規則、舊 prompt，與第 5 天起不可直接比較；重跑範圍由組長決定。

## 10. 2026-10-31 組長決定：J=6 單次例外

組長核定，太平洋時間 2026-10-31 這一個額度日的校準 job 上限開到 20（已跑 6 + 第 5 天 6 + 舊版 dual 重跑 8），由 `dev_traces.py --j-exception 20 --j-exception-day 2026-10-31` 明確指定，其他日期仍是 J=6。每個 job 的預算、80% RPD／RPM／TPM 限制、模型與規則都不變。前瞻研究 3 個 job 存在獨立的 `tmp/forward_batch1.sqlite3`，讓 D 的校準匯出只含開發案例。

實際執行（2026-10-31，台北）：前瞻 3 個（19:17）、第 5 天 6 個（19:23）、dual 重跑 8 個（22:09 完成）。重跑第一次卡在 mock 階段：mock 的 quota 沒帶例外，第 7 案被 J=6 暫停，當時尚未送出任何真實請求；停掉後拆成 6＋2 兩批重跑，輸出為 `agent/calib-v1-dual-rerun-1.json`、`-2.json`。mock 階段已修正。校準比較的 dual 一律用重跑結果；`dev-runs-calib-v1.jsonl` 仍保留舊 dual，以 started_at／repo_commit 排除。

## 11. 2026-11-02 組長決定：回覆 B 的 W08 待決事項

- **中文金額單位（CR-W08，`docs/CR-W08-review-chinese-amounts.md`）**：採用。`agents/review_checks.py` 新增 `chinese_amounts()`，原文的「5,118億5,700萬元」這類寫法換算後相符即算來源支持；引用證據的數字池也納入換算值。寫錯的數字仍判 not_supported。測試 `tests/test_review_chinese_amounts.py`。屬第二段，W09 鎖定時一併鎖定。
- **來源衝突只比同單位**：`find_conflicts()` 只比較同單位（億對億、% 對 %）。月營收與季營收單位相同仍會列出，維持 minor、不擋。
- **影響範圍**：~~B 掃描過，開發集 10 案的證據沒有中文單位金額~~（**11/05 B 更正**：當時的掃描不接受數字與單位間的空格，漏掉 CASE-08 二手摘要的「2 兆 2,558.94 億元」；11/06 已改為允許空格）。校準結果仍不受影響：CASE-08 single 不經覆核，dual 的 c2 是 unknown、沒有數值。保留集由 B 用修正後的版本再掃一次。以新規則重放前瞻第 1 批草稿：2330 規則判定 insufficient → pass；2454 insufficient → pass（只剩月營收與季營收的 minor）；2317 不變。
- **前瞻第 1 批不重跑**：照手冊「資料不足照收錄」，以現有結果記錄。中文金額誤判、2454 Researcher 只搜尋一次未讀第三季證據，兩點寫進限制。
- **同業平均**：依手冊 F02「各自財報期與來源明示」，不同財報期的同業都計入（2454 比較組 n=2），表格逐列標財報季別，`periods_consistent = false` 時註明「同業財報期不同」。`research_ui/comparison.py` 已由組長端改（11/02，不再篩同財報期，`peer_stats.period_note`；PDF 同步加註），測試 `test_peer_stats_keep_peers_with_a_different_period`；請 A 核對網站呈現。
- **發布前容量 80% 檢查（`data/storage-and-safety-w08.md` 第六節）**：原則採用；門檻依 Supabase 實際方案訂，組長提供方案與用量後再實作，migration 先在測試專案演練。

## 12. 2026-11-02 組長決定：W08 部署

- **部署架構**：研究只在組長 Mac 跑（job 存 `tmp/*.sqlite3`）；Render 只做組長登入、核准、發布 PDF 與公開閱讀，不設 Gemini 金鑰與 `RESEARCH_API_TOKEN`。`research_jobs` 不搬 Supabase。詳見 `handoff/deployment-v1.md`。
- **Render 方案**：維持 Free（512 MB）。11/02 在 Free 上發布 1 份 PDF 成功；第二批發布若出現 `pdf_failed`（記憶體不足）再升級 1c-2g（US$25／月），屆時另行核准費用。
- **報告存放**：維持 Supabase 測試專案 `fintech-agent-test`（`report_versions`＋私有 bucket `reports`），正式專案不動。
- **備份**：每批發布後執行 `scripts/backup_reports.py export`，並另存一份到 iCloud Drive `fintech-agent-backups/`（11/02 首份已存）。
- **公開清單快取**：60 秒 TTL，一次查詢（commit f7014d1）。
- **Notion**：W01-L、W02-L、W06-L 改回「進行中」，與實際未完成項一致（W01 TPM 精確值；W02 job 遷移改為不搬、待記錄；W06 介面凍結紀錄與閘門文件）。

## 13. 2026-11-06 組長決定：校準 v1 簽核

- 簽核三模式校準 v1（W06-D）：D 評分 `evaluation/d-drafts/calib-v1-scores-D.txt`、B 交叉評分 `calib-v1-scores-B.md`，30 列標籤一致、53 個事實數值正確。S10、S15 備註中的「待組長裁決」以 11/03 裁決為準。
- W06 閘門定稿（`handoff/W06-gate-v12.md` 第 2、9 節）：N01–N03 ✅、N07 ✅（附限制）。
- W09 是否修正 Researcher：方案見 `handoff/W09-researcher-fix-proposal.md`，待組長決定。

## 14. 2026-11-06 組長決定：W09 Researcher 修正（Agent v2）

- 採 `handoff/W09-researcher-fix-proposal.md` 第三節 1–4：停止原因由程式依執行紀錄產生；覆核新增「草稿描述的工具事件須在執行紀錄中」；壓縮與工具關閉時告知模型；Researcher prompt 升為 researcher-v1.2.3。
- **放寬預算**：單次輸入上限 3,000 → 6,000 token、每 job token 上限 40,000 → 64,000。每 job 8 次發送、10 次工具、2 輪補查不變。**此改動須在報告中呈現**，版本對照見 `handoff/agent-version-changes.md`。
- 生效：11/06 第二批前瞻跑完後合併（第二批仍用 v1）；11/09–11/10 dual 開發集重跑，D、B 評分後 11/13 鎖定。

## 15. 2026-11-07 紀錄：CASE-13 與保留集揭露

- **CASE-13 結論（B，`evaluation/source-audit-final.md` 第一節第 3 點）**：保留集 CASE-13 與手冊附表、`data-freeze.md` 一致；10/15 以前出現的「CASE-13」（2317，缺 CapEx）是已廢除的舊開發草稿，與保留集無關。保留集未被污染。引用舊紀錄時標註「已廢除，與保留集無關」；網站 REPLAY 的舊 CASE-13 請 A 加註。
- **揭露**：上述稽核文件寫有保留集 CASE-13 的一行情境描述，組長端（Claude）11/07 查閱結論時讀到。讀到前 Agent v2 已完成且只用開發集驗證；之後不據此調整任何 prompt、規則或程式。請 B 從文件移除保留集內容，只留一致性結論。
- **排程**：第二批 21:10 的排程實際 21:39 才觸發（Mac 睡眠），與組長手動執行幾乎同時，由凍結腳本「不覆蓋」防護擋下重複。第三批 11/13 21:10 已排程；當晚 Mac 需保持清醒。

## 16. 2026-11-07 組長決定：v2 覆核規則補修

- 依 v2 重跑第 2 天：unknown 引用 no_data 不列 critical；數字比對接受「40.0」寫法；Reviewer prompt 升 reviewer-v1.2.2（不用 read_evidence 讀 obs）。詳見 `handoff/agent-version-changes.md`「v2 的 11/07 補修」。
- 11/08 重跑受影響的 CASE-15、19、26，並跑 CASE-29（共 4 個 job，J=6 內）；11/13 鎖定時程不變。CASE-19 的放棄行為不再修，寫進限制。

## 17. 2026-11-08 組長決定：fact sheet 保留集描述照原樣保留（選項 a）

- `data/v12-finance-fact-sheet.md` 第七節第 128、132 行寫了兩個保留案例各自測試的目的（題型層級，無答案、數字或來源內容）。此檔屬第一段凍結，**不修改、不重新凍結**，以本節揭露。
- 理由：題型分類本已公開（30 案總表）；保留集的有效性取決於未用於調整系統，Agent v2 只以開發集修正與驗證（第 14、16 節、`handoff/agent-version-changes.md`）。
- B 已於 11/08 從其餘共用文件移除保留集案例內容（`evaluation/source-audit-final.md`、`docs/CR-W05-holdout.md`、`docs/B-W01-W06-檔案說明.md`）。之後共用文件不得寫入保留集案例內容。

## 18. 2026-11-08 組長決定：鎖定前補做 single、workflow 的 v2 煙霧測試

- 原因：v2 改動（輸入上限、停止規則、Researcher prompt）三個模式共用，但 v2 重跑只驗了 dual。11/13 鎖定後不能再改，若 single 或 workflow 在 v2 有問題，W10 正式實驗才發現就只能整批記為失敗。
- 做法：用 11/09–11/12 空出的額度（原排 11/09–11/10 的 dual 重跑已於 11/06–11/08 提前完成），single、workflow 各跑開發集 10 案，共 20 個 job，每天 19:30 自動執行（J=6 內）。輸出 `agent/calib-v2-modes-day1..4*.json`。
- **由組長端自行執行與檢查，不交 D 評分、不需任何組員動作**；只確認不會出錯、停止理由與執行紀錄一致、必答案例（CASE-01、04、19、22）沒有停在證據不足。結果併入 11/12 的 v1／v2 比較。
- 更正：CASE-15 為 `allow_insufficient=True`，11/08 停在證據不足屬允許結果，不列為限制。
- 前瞻第三批維持 11/13 21:10：cutoff 21:00 已登錄在 `research/forward-batch-3-sources.json`，`freeze_forward_batch.py` 未到截止時間會拒絕執行。

## 19. 2026-11-08 組長決定：C 的文稿全部核准，取消「待核准」標示

- 合併 PR #30（C 依 Agent v2 更新預算數字並標示版本；B 11/08 轉達的三點已處理，組長端核對與程式值一致）。
- C 的 W01–W07 文稿（動機、RQ、文獻、引用、方法各節、第三章、7.x 網站與報告、glossary、method-budget）狀態改為「組長 2026-11-08 核准，可直接引用」。E 的簡報可直接引用 main 版本，不必再標「草稿」。
- 之後的修改照常提 PR，合併到 main 即視為可用，不再另等核准文字。仍須遵守的只有內容規則：實驗結果數字只用 D 交出的；v1、v2 結果不同表比較；不放保留集內容。

## 20. 2026-11-09 前瞻 LIVE 報告資料區塊修正與第 2 版

- 問題（A 11/08 在 Render 發現）：第 1、2 批前瞻報告的資料區塊用 30 案凍結快照計算，主張來源顯示「無來源」、收盤價停在 9/30。屬 A 的報告程式錯誤，Agent 輸出與前瞻快照本身沒錯。
- 合併 PR #32（報告改讀當時的前瞻快照）、#33（REPLAY 舊 CASE-13 標「舊開發草稿，已廢除」）、`codex/A-source-traceable`（B 11/09 決定：來源可追溯改為財報三檔組合 hash＋報告實際引用的片段；30 案 MOCK 結果不變）。main 430 passed。
- 組長端 11/09 在 Mac 建立第 2 版草稿（Supabase）：2330 `rv-db6b0e1b…`（快照 11/06，收盤 2,135，來源 2/2 可解析，資料品質低）、2317 `rv-2ed6652e…`（快照 10/30，收盤 245.5，來源 1/1，資料品質低）。資料版本 report-data-v1.4。
- 第 1 版維持已發布、留在歷史版本，不改寫；第 2 版待組長在 Render 登入核准後發布。發布後重跑 `backup_reports.py export` 並存 iCloud。
- 11/09 14:53–14:54 組長在 Render 登入後核准發布：2330 第 2 版 14:54:16、2317 第 2 版 14:54:44（台北）。線上確認：主張來源全部可解析、PDF 可下載。備份 `tmp/backups/20261109-145511`（4 份報告、4 份 PDF、11 個 job 資料庫，還原核對全部 PASS），已另存 iCloud `fintech-agent-backups/`，掃描無金鑰字串。

## 21. 2026-11-09 舊網站首頁改導向研究工作台

- 問題：舊網站「查詢分析」（`main.py`）讀的 Supabase 正式專案 `watooxoseljrnlsoequc`（東京，Free／Nano）約 11/06 起 Unhealthy，所有 REST 與內部健康檢查回 503；資源用量正常（CPU 3%、記憶體 51%、磁碟 13%），Supabase 全站狀態正常。11/09 15:03 組長同意後執行 Restart project，15:16 仍 503。組長決定不開單、不修復，舊查詢頁停用。
- 影響：只有舊查詢頁。研究工作台、LIVE 報告與 PDF 用報告測試專案，不受影響；實驗、鎖定、前瞻批次不需要舊網站。
- 組長決定：首頁 `/` 改 302 導向 `/research`（`web_app.py`，`tests/test_home_redirect.py`，commit 044e8d5），15:23 Render 上線確認。Supabase 修好後可改回。
- 風險：`fundamental_data` 只在該專案、Free 無備份；恢復後應另行匯出。

## 22. 2026-11-09 W10 正式評估排程與鎖定清單補列

- 第二段鎖定清單補列 `agents/budget.py`（v2 輸入上限 6,000、每 job 64,000 token）、`agents/store.py`、`agents/worker.py`；鎖定時另記 researcher／reviewer prompt 版本與全部預算上限。
- 正式評估 runner `scripts/formal_runs.py`：保留 20 案 × 3 模式 = 60 run；第二段未鎖定或 `--verify --strict` 未過即拒絕 live；只讀封存案例的執行欄位，結果列只含狀態與預算（`evaluation/formal/runs-v2.jsonl`），草稿留在 `tmp/formal_v2.sqlite3`，組長與 Claude 不打開。
- 執行計畫 `evaluation/run-plan.json`（固定種子 20261116；同案三模式連續、起始模式輪替；每配額日 2 案 × 3 模式），待 D 確認或替換。
- 11/09 離線檢查：保留 20 份快照工具呼叫 130 次，無例外、無缺快照（只回報錯誤，不看各案結果）。
- **組長決定：11/16–11/25 每天 19:30 跑 6 run，含週末，共 10 個配額日**（排程 fintech-formal-v2-daily）；B、D 評分與裁決排 W11 後半。

## 23. 2026-11-10 合併 D 的 v2 dual 評分；Researcher 補 next_signals 指示

- 合併 PR #37（D：`evaluation/d-drafts/calib-v2-scores-D.txt`，v2 dual 開發集 10 案）。D 標「不確定」兩處（CASE-08 c2、CASE-19 整體結果）交 B 核對，兩人不一致由組長裁決。
- CASE-15、18「不符合預期」：缺下一確認訊號。prompt 從未要求填 next_signals，屬規格漏寫。**組長決定修**：researcher-v1.2.4（`handoff/agent-version-changes.md` 第 9 項）。
- 驗證：11/10–11/12 煙霧測試即用新版；11/12 用剩餘額度以 dual 重跑 CASE-15、18。

- 11/11 補：W11 盲評匯出 `scripts/export_for_scoring.py`（回應 D 11/11 問題 3）。60 run 都執行後才匯出；去掉模式、停止原因、覆核紀錄、預算與 Reviewer 工具結果，隨機 answer_id 打亂順序；對照表存組長 Mac `tmp/`、只公開 sha256（`key-commitment.json`），B、D 都交評分後 `--reveal` 才公開並核對 hash。

## 24. 2026-11-11 股價快照格式修正；開發集缺股價列為限制

- 煙霧測試第 3 天（workflow，CASE-08、11、15、18、19、22；commit 9f84e5e）：6 案無錯誤。CASE-15、18 有寫下一確認訊號。CASE-19（不允許停在證據不足）在 workflow 停在證據不足；single 第 2 天有完成。**組長端建議不修**：workflow 是固定流程基準組，prompt 三模式共用；照實記為開發集觀察（待組長確認）。
- 股價：全域股價資料只有 2026-09-22 至 09-30 五個交易日，開發集 9 案 cutoff 在 7、8 月，`get_price_window` 回 `no_data` 是時間規則的正確結果，不是錯誤。補歷史股價要重開第一段凍結、動保留集資料、開發集重跑重評，~~建議不改，列為限制~~ **（同日組長改為補齊，以第 25 節為準）**（估值未受正式評估檢驗；「未知」主張不計分；三模式條件相同）（待組長確認）。
- 保留集狀態統計（只計數量與欄位名稱，不看題目、數值、答案）：修正前 `get_price_window` 20 案為 ok 2、no_data 15、KeyError 3。3 案的 `price_snapshot` 是 `closes` 清單格式，程式只讀得懂開發集的單筆格式。11/09 的離線檢查（第 22 節）經 dispatch 執行，例外被包成 `tool_error`，當時沒有統計到。
- **組長決定：鎖定前修**（`handoff/agent-version-changes.md` 第 10、11 項）。屬工具讀檔格式，prompt 與判斷邏輯不動。修正後同一統計為 ok 5、no_data 15、例外 0；pytest 444 通過。
- 保留集接觸紀錄：11/11 搜尋 `price_snapshot` 的使用位置時，終端輸出帶出 `scripts/build_holdout_cases.py` 的一行擾動說明（一個案例、一個欄位）。Claude 沒有再開該檔，也沒有據此調整 prompt 或判斷邏輯；此次修正只依欄位名稱。`synthetic_adjusted` 欄位工具不回傳，是否為出題本意待出題組員確認。

## 25. 2026-11-11 組長決定補齊歷史股價（取代第 24 節「不改」的建議）

- **決定**：股價是公開資料，缺的是快照沒收，不是 Agent 查不到；補上才能檢驗估值段落，符合專題「提高證據完整度」的目的。資料變更、重新凍結與時程由組長決定，組員告知即可。
- **做法**（`scripts/extend_price_history.py`）：5 檔股價由 cutoff 前 5 個交易日補為 2025-01-02 至 2026-09-30 的全部交易日（2330、2454、2379、3034 各 422 日，2317 為 421 日）。來源與口徑不變（FinMind TaiwanStockPrice，未還原收盤價）；原 5 日數值完全相同才寫入；財報、總經、證據、案例檔都沒動；快照 cutoff 仍是 2026-09-30。
- **不看未來**：可得時間仍是交易日 17:30，工具只給案例 cutoff 之前的價格（`tests/test_price_history.py`）。
- **工具**：`agents/tools_impl.py` 新增 `_raw_file_covering`，`get_price_window` 的 content_hash 指向日期涵蓋該視窗的原始檔。原 5 日的原始檔紀錄保留，9/22–9/30 內的視窗仍回原 hash，所以既有工具 fixture（TR-17、TR-18）、同業快照、`source-manifest` 都不用改。
- **對帳**（`scripts/check_prices_twse.py`，結果 `data/price-history-twse-check.json`）：5 檔共 2,109 個日收盤價逐日與證交所 STOCK_DAY 比對，**全部相符、0 筆不符**；快照期間內 TWSE 有收盤價的交易日快照都有。
- **凍結**：不重跑整份凍結（會蓋掉 10/25、10/28 的簽核）。`scripts/build_freeze.py --amend` 新增修訂紀錄：`data/v12-frozen-manifest.json` 的 `amendments` 第 1 筆、`data-freeze.md` 第八節。cases_digest 98af84030d45 不變，`--verify` 一致；原簽核保留，修訂由組長負責。
- **檢查**：pytest 448 通過；check_sources、check_cases 0 錯誤。
- **影響**（離線、不呼叫模型）：開發集 9 案 1／5／20 日視窗都有資料，結束於 cutoff 前一個交易日；CASE-04 用案例自帶的單筆收盤價，行為不變。保留集只計狀態數量：1 日視窗 ok 20；5 日與 20 日視窗各為 ok 17、no_data 3（修正前 ok 5、no_data 15）。
- **限制（寫進報告）**：
  1. 保留集的預期答案在 10/25 凍結時寫成，當時多數案例查不到股價。組長看不到預期答案；LINE 群組紀錄（9/13–11/11）沒有任何訊息說明預期答案是否以「查不到股價」為前提。補股價後，Agent 可能寫出預期答案沒有涵蓋的估值主張。處理方式：預期答案不改；B、D 盲評照評分規則評，報告註明此差異。
  2. 校準 v1、v2 開發集 dual 重跑（11/06–11/08）與煙霧測試第 1–3 天都是補股價前跑的；補股價後的結果另外標示，不與之前的放同一張表。
  3. 開發集補股價後以 dual 重跑（11/12–11/14，額度內），組長自查；D 不重新全評。正式實驗 11/16 開始不變。
- **保留集接觸紀錄**：11/11 讀 `data-freeze.md` 前 40 行時看到 30 案清單（含保留集的類別、變體標籤與 cutoff，沒有題目、數值、答案）。沒有據此調整 prompt 或判斷邏輯；股價是整段補齊，不針對任何案例。

## 26. 2026-11-11 Researcher 補「來源衝突」處理規則（researcher-v1.2.5）

- 依據：D 的 v2 dual 評分（CASE-19 整體結果「不確定」）、煙霧測試第 3 天（workflow CASE-19 停在證據不足）。prompt 沒寫幣別／單位／口徑衝突且無法確定時怎麼做，屬規格漏寫。
- **組長決定修**：加一條通用規則（`handoff/agent-version-changes.md` 第 14 項）。不含案例內容；沒有看保留集。三模式共用同一 prompt。
- 驗證：不另花額度，11/12–11/14 的煙霧測試第 4 天與開發集補股價後 dual 重跑即用新版。結果沒有變好也照實記錄，鎖定前不再為結果調 prompt。
- 不做：程式層「不允許停在證據不足就退回重寫」（會改變有限預算下的行為）；CASE-26 逾時（凍結案例不改，10/24 已定）；workflow、single 較常停在證據不足（對照組，照實觀察）。
- 排程說明檔（第 4 天、前瞻第 3 批）的預期版本已改為 researcher-v1.2.5。D 的 `evaluation/d-drafts/runner-smoke.md`、`v12-runner-freeze.md` 仍寫 v1.2.4，鎖定時請 D 更新。
- pytest 448 通過。

## 27. 2026-11-11 get_price_window 回傳 synthetic_adjusted（第 24 節待確認事項結案）

- 第 24 節留下的問題：保留集 `price_snapshot` 的 `synthetic_adjusted` 欄位工具不回傳，是否為出題本意。組長 11/11 詢問 B，B 回覆：該欄位應由工具回傳給 Agent，照原樣傳出，不另加說明或提示。
- **組長決定照 B 的回覆修**（`handoff/agent-version-changes.md` 第 15 項）。屬工具漏傳欄位，不動 prompt 與覆核規則。
- 做法只依欄位名稱：有此欄位就整個照原樣放進回傳；Claude 沒有讀取或印出欄位的值。保留集只計數量：20 案 1 日視窗皆 ok，其中 1 案回傳帶有此欄位。開發集無此欄位，行為不變。
- 附帶效果（照實記錄）：覆核的「數字必須出現在工具結果」規則，會把此欄位內的數字視為工具回傳過的數字。
- B 的回覆含該題的出題意圖，只留在組長與 B 之間，不寫進 repo、Notion 或任何共用文件。
- pytest 449 通過；`build_freeze.py --verify` 一致（`agents/snapshot.py` 屬第二段）。

## 28. 2026-11-12 覆核規則：P/E 的 TTM 季度判定、查到卻沒寫的提醒

- 依據：開發集補股價後 dual 重跑 11/12（`agent/calib-v2-dual-postprice-1112.json`）。
  - CASE-04（必答）被覆核判證據不足。組長端逐項核對：股價 2026-09-30 收 2480（cutoff 當日 17:30 可得）、TTM EPS 86.28（2025Q3–2026Q2 連續四季）、P/E 2480 ÷ 86.28 = 28.74，都與快照一致。擋下的原因是「TTM 要四個連續單季」規則也套到 pe_ttm：P/E 的期間寫股價日期，規則讀不到季度就列 critical，第二輪無可修、預算用完而停止。屬程式誤判（與 11/07 第 7 項同類），不是模型錯誤。
  - CASE-01 通過覆核，但已取得股價卻沒寫估值，也沒查總經；覆核沒有任何提示。
- **組長決定修**（`handoff/agent-version-changes.md` 第 16、17 項）：
  1. pe_ttm 本身沒寫季度時，改看草稿中 eps_ttm 的季度，沒有就看快照的 TTM 季度；四季不連續或找不到季度仍列 critical。pe_ttm 自己寫了錯的季度照樣擋。
  2. 新增「查到了卻沒寫」提醒：已取得股價但沒有估值或本益比、沒有總經觀察（分已查未寫、未查兩種），各列一筆 minor。**只提醒、不改變放行結果**；Researcher 已回 insufficient 時不加。
- 只改覆核程式（`agents/review_checks.py`），不改 prompt（researcher-v1.2.5、reviewer-v1.2.2 不變），符合第 26 節「鎖定前除程式錯誤外不改 prompt」。沒有看保留集；兩條規則都是通用規則。
- 離線驗證（不花額度，用 11/12 的草稿與重建的工具結果）：CASE-04 由證據不足改為通過（餘 1 筆 minor：已取得總經未寫）；CASE-01 仍通過，多 2 筆 minor；CASE-15 規則端通過、多 2 筆 minor（實際結果由模型覆核判 insufficient，不變）；CASE-18 仍為證據不足。
- 版本標示：11/12 的 CASE-01、04 dual 結果是修正前規則；11/13 起的開發集重跑與 W10 正式實驗用修正後規則。CASE-04 於 11/13 以新規則重跑一次。
- 測試 `tests/test_review_pe_coverage.py`（合成資料）；pytest 459 通過。

## 29. 2026-11-12 盲評匯出附完整工具結果（B 11/11 提出）

- B 11/11：盲評答卷中被引用的 obs-* 只附 500 字摘要，說明要評分者「用同一快照重算」；評分者不便自己對保留集快照跑工具。
- **處理**：工具結果的完整 `data` 另存在 job 的 checkpoint（`agents/research_graph.py`），只給盲評匯出用；不放進任何送給模型的內容，也不放進執行紀錄事件，Agent 行為不變。`scripts/export_for_scoring.py` 對被引用的 obs 附 `result_data`（完整數字結果），答卷說明改為「不必自己重跑工具」。只附被引用的 Researcher 工具結果，不含順序、模式、覆核紀錄。
- 只對此後的 run 有效；正式實驗 11/16 起跑，60 份都會有。
- B 的第二點（「停止原因與執行紀錄是否一致」盲評時做不了）：組長端建議改為公開對照表（`--reveal`）後由程式逐份比對 stop_reason 與執行紀錄，B、D 抽查；待組長確認。
- 測試：`tests/test_export_for_scoring.py` 更新；模擬執行（不呼叫模型）確認 checkpoint 存有完整數字。pytest 459 通過。

## 30. 2026-11-13 案例檢查結果；「題目怎麼交給 Agent」待組長決定；保留集接觸紀錄

- 起因：組長 11/13 問「案例是否真的都不用改」。組長端逐案檢查開發集 10 案；保留集只做數量統計（只印數量、狀態、欄位名稱、型別與長度，不印內容）。
- **案例檔本身：沒有發現需要修改的地方。**
  - 保留集 20 案：會讀快照的五個工具沒有任何 tool_error（`calculate_metrics` 是純計算、不讀快照，未列入）。`search_evidence` ok 14、no_data 6；搜尋到的 30 筆來源 `read_evidence` 全部 ok；`get_financial_snapshot` ok 19、no_data 1（該案的模擬設定，任何呼叫都會觸發）；`get_macro_snapshot` ok 20；股價 1 日視窗 ok 20，5／20 日視窗 ok 17、no_data 3。擾動位置引用的來源編號都在快照內（11 筆 cutoff 前可得、1 筆在 cutoff 後）。覆核規則以 5 種合成草稿逐案試跑（含 11/12 新增的兩條），沒有例外。`check_cases.py`、`check_sources.py` 0 錯誤。
  - 保留集沒有 `read_evidence` 逾時模擬，不會出現開發集 CASE-26 的情況。CASE-26 測不到逾時的原因：該快照沒有 `evidences`，逾時指定的是全域來源編號，Agent 搜尋不到就不會去讀。維持 10/24 決定不改。30 案中沒有任何一案會在 live 觸發逾時，逾時處理只以離線測試為證，報告不可寫成 live 驗證過。
- **發現的問題在 runner（題目怎麼交給 Agent），不在案例檔。待組長決定：**
  1. 研究焦點（focus）目前一律送案例的 `variant`（變體名稱）。變體名稱多數直接寫出擾動類型（開發集例：「TWD與其他幣別混用」「單季EPS當TTM EPS」「read_evidence故意timeout」「要求呼叫未授權工具」），等於事先告訴 Agent 這題的陷阱。校準 v1、v2 與煙霧測試都在這個條件下跑。佐證：11/12 CASE-18 的草稿摘要直接寫「焦點要求…cutoff 之後的關鍵證據」後停止；校準 v1 的 CASE-26 在沒有發生逾時的情況下寫出「read_evidence 逾時」（S17、S27）。影響多大尚未量測。
  2. 保留集案例檔每案有 `task` 欄位（20 案皆為字串，17–48 字，各不相同，都不含變體名稱），開發集沒有這個欄位。`scripts/formal_runs.py` 的 `RUN_FIELDS` 沒有讀 `task`，正式實驗照現況送給 Agent 的會是 `variant`。
  3. `docs/CR-W05-holdout.md` 第 5 項（B 10/28 提出）一直沒有完成：保留集快照的 `task_input`（1 案）、`draft_under_review`（1 案）、`required_elements`（1 案）沒有傳入 job。保留集有 3 案的擾動位置就在 `task`、`task_input`、`draft_under_review`；照現行 runner，這 3 案 × 3 模式 = 9 個 run 的擾動到不了 Agent。11/09 寫正式 runner 時漏了這一項（組長端）。
- 待辦：向 B 確認三件事（`task` 是否就是給 Agent 的題目、`task_input`／`draft_under_review` 要怎麼附給 Agent、`required_elements` 是給 Agent 還是給評分者）；組長決定後改 runner（只依欄位名稱讀取，不看內容）、在開發集預演，再鎖定第二段。第二段鎖定與正式實驗起跑日是否順延由組長決定。
- **保留集接觸紀錄（Claude，11/13）**：為確認上述三個欄位有沒有程式讀取，以欄位名稱搜尋整個 repo 時沒有排除 `scripts/build_holdout_cases.py`，搜尋結果印出該檔 5 行，含 3 個保留案例的片段（擾動位置說明與輸入欄位的片段）。沒有打開該檔，沒有看到預期主張（expected_*）的文字內容。看到的內容沒有寫進任何文件，回報組長時也只說明經過、不轉述內容；沒有據此調整 prompt、覆核規則或工具。此後搜尋一律排除該檔與封存檔。之後 runner 的修改只依欄位名稱傳遞，格式由 B 指定。

## 31. 2026-11-13 題目改送 `task`；`task_input`、`draft_under_review` 原樣附給 Agent（第 30 節待決事項，依 B 的回覆實作）

- 組長 11/13 把第 30 節的三個問題問 B，並轉交 B 的回覆（只講欄位用法）。組長端依回覆修改 runner：
  1. **研究焦點改送 `task`，一字不改；不再送 `variant`。** `variant`、`category`、`expected_behavior`、`expected_*`、`allow_insufficient`、`perturbation_location` 都不進 Agent 輸入。`scripts/formal_runs.py` 的 `RUN_FIELDS` 改為 `case_id、ticker、cutoff_at、source_snapshot_id、task`；任何一案沒有 `task` 就停止。prompt 沒有改：`task` 仍放在可信輸入的 `focus`（prompt 原本就寫「focus 是本案研究焦點」）。
  2. **`task_input`、`draft_under_review` 以同名欄位、JSON 原樣放進可信輸入，不加任何說明，也不串進 focus。** single、dual（Researcher 與 Reviewer 都有）、workflow 三種模式都給。程式直接從該 job 綁定的快照依欄位名稱讀取（`agents/research_graph.py` 的 `CASE_INPUT_FIELDS`），job 契約（`agents/contract.py`）不用改。快照沒有這兩個欄位時，輸入和修改前完全相同。
  3. **`required_elements` 只給評分者，不送 Agent。** `scripts/export_for_scoring.py` 的盲評答卷新增 `given_to_agent`（題目與原樣附給 Agent 的欄位）與 `scorer_only`（`required_elements`）。
- **開發集題目**：B 11/14 前補 10 句，放新檔 `evaluation/dev-tasks.json`（`case_id`、`task` 兩欄）。`scripts/dev_traces.py` 有這個檔就優先讀；`evaluation/dev-cases.json` 與 `cases_digest` 不動，不需要第一段修訂 2。檔案還沒到之前，開發集仍送 `variant`。
- **條件標示**：每個 run 的紀錄多一欄 `focus_source`（`task` 或 `variant`）。校準 v1、v2 與煙霧測試（到 11/12 為止的全部開發集結果）都是送 `variant` 的條件；之後送 `task` 的結果不可與它們直接比較，報告須註明條件不同。
- 只依欄位名稱與數量檢查保留集（不印內容）：20 案的 `task` 都通過 job 契約（focus ≤ 200 字）；`task_input` 1 案、`draft_under_review` 1 案會送達；`load_holdout()` 取出的欄位只剩上述五個。
- 測試：`tests/test_task_inputs.py`（合成資料：三種模式與 Reviewer 都收到、沒有欄位時不變、`required_elements` 不進 Agent 輸入、`dev-tasks.json` 優先）、`tests/test_formal_runs.py`、`tests/test_export_for_scoring.py`。pytest 470 通過；`build_freeze.py --verify` 一致；`check_cases.py` 0 錯誤。
- **還沒做、待組長決定**：B 的 `dev-tasks.json` 到了以後在開發集用 `task` 預演（用當日額度），確認沒有問題再鎖定第二段；鎖定日與正式實驗 11/16 起跑日是否順延。第二段沒鎖定前 `formal_runs.py --live` 會拒絕執行。
- `docs/CR-W05-holdout.md` 第 5 項至此完成（該文件由 B 維護，請 B 更新狀態）。

## 32. 2026-11-13 前瞻第 3 批：聯發科負債覆寫（第一段凍結修訂 2）；結果

- 21:10 排程在凍結快照時中止：「2454 找不到 2025Q2 的科目 BondsPayable」。排程照規定停止，沒有改檔、沒有用 Gemini 額度。
- **原因**：FinMind 在 11/06 之後新增聯發科 2026Q3 資產負債表，出現應付公司債 111,338,386 千元（前兩批該科目在 FinMind 完全不存在）。快照程式規定「選用負債科目只要出現過，五季都要有值或有覆寫」，缺 2025Q2、2026Q1、2026Q2 而中止。FinMind 同時補上 2025Q3 長期借款 0，與既有覆寫列並存也會中止。
- **組長決定由組長端直接修**（不經 B）。`data/manual/balance_overrides.csv`：
  1. 新增 2454 的 2025Q2、2026Q1、2026Q2 應付公司債 0 三列。依據：組長端 11/13 逐表核對 MOPS 聯發科合併資產負債表，115Q1（115/03/31）、115Q2（115/06/30 與比較欄 114/06/30）都沒有應付公司債科目；115Q3 為 111,338,386 千元，114/12/31、114/09/30 為 0，與 FinMind 相符。
  2. 刪除 2454 2025Q3 長期借款 0 一列（FinMind 已有同值）。
- 該檔屬第一段凍結的人工檔，以 `build_freeze.py --amend` 記為**修訂 2**（`data-freeze.md` 第八節）。30 案實驗用的 `data/financial-snapshots.json` 沒有重建，案例與 cases_digest 98af84030d45 不變。
- **第 3 批結果**（Agent v2，researcher-v1.2.5／reviewer-v1.2.2；修正後組長端 21:16 手動執行，晚於截止 16 分鐘）：快照 sha256 64d5032e8bc4；截止後資料檢查 0 筆。2330 insufficient_evidence（researcher_insufficient）、2317 succeeded（review_pass）、2454 succeeded（review_pass）。報告皆未發布，方向 none。
- **限制（照實記錄）**：五家的 2026Q3 都已在截止前公告，但本批財報仍用到 2026Q2。原因是 FinMind 還沒有鴻海 2026Q3 的損益資料，程式的設計是新季別「全部納入或全部不納入」，於是照既定備案不帶新季別（第 2 批相同）。聯發科 2026Q3 的應付公司債因此沒有進入本批計算。報告引用本批時須註明財報截至 2026Q2。
- 請 B 事後複核修訂 2 的三列覆寫與 MOPS 依據。pytest 471 通過；`build_freeze.py --verify` 一致。
