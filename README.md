# Cairnwork

Cairnwork 是 Nexus-new 的後繼產品：一個接任務、執行、驗證，再交給 nexus-core 公證的 agent 工作主體。三層結構（第一層：包住模型前後的輔助與完成驗證；第二層：本機模型能力；第三層：前沿模型）從這裡長出來。

## 定位：完成有證據

> Cairnwork 是小型 pytest 修補的試點驗收工具，依賴自備延後測試；通過仍需人工審查。與候選碼同程序執行的一般 pytest，其 PASS 不具防竄改保證，`cairnwork-verify` 的輸出與帶延後測試的收據會標出保護等級（見 [docs/SECURITY.md](docs/SECURITY.md)）。

Cairnwork 是 AI 寫程式代理人的交付驗證層。核心價值不是提高成功率，而是「完成有證據」：變更唯有通過延後隱藏測試才算完成（只有 `test_source: "bundle"` 嚴格模式保證 worker 看不到測試；預設 `auto` 是相容／示範模式，不作保密主張），並可附上離線可驗證的簽署證明（見 [docs/ATTESTATION.md](docs/ATTESTATION.md)）。具體是四件事：

- **僅驗收完成**：沒通過驗收程序的候選 commit 不算完成。
- **延後隱藏測試**：驗收用的測試在 worker 結束後才套到候選上，worker 的 clone 只有 base。保密保證只在 `test_source: "bundle"`（測試只放私有存放區、沒匯入就拒絕、絕不退回 origin）成立；`auto`（程式預設）有 bundle 就用、沒有才從 origin 的公開分支抓，worker 仍可能找得到，所以不主張保密。證明包的 `test_source` 欄位記錄該次執行當時用的模式（取自執行時寫入的紀錄，不是現在的 config.json；沒有隱藏測試或舊的執行為 `none`）。
- **隔離驗證器＋Core 公證**：驗收在專用帳號與沙盒（macOS Seatbelt／Linux bubblewrap）執行，請求與結果進只增不改的紀錄，由 Core（nexus-certify）核驗並綁定確切的候選 commit。
- **簽署證明可離線驗證**：驗收紀錄可用 `cairnwork-attest statement --sign` 產出 in-toto＋DSSE Ed25519 證明包，第三方用 `cairnwork-attest verify` 只靠公鑰與本機 git 物件離線重算；PR 上可用 [cairnwork/verify-action](https://github.com/cairnwork/verify-action) 自動檢查。`cairnwork-verify` 驗外部候選時，收件方用自己的政策檔（釘選測試來源、Core 身分與簽章金鑰）離線驗證收據；機密模式只證明「非測試路徑與 PR head 逐位元相同、簽署者聲稱跑了政策指定的測試」，不驗測試內容（[#229](https://github.com/cairnwork/cairnwork/issues/229)，壓力重放 172/172 放行）。

不主張：

- 不主張提高模型解決任務的成功率（強模型在小 bug 上本來就很少錯）。
- 不主張取代人工程式碼審查。
- 不主張是互動式 coding agent 或對話助理。
- 不主張一般 pytest 測試能防住刻意作弊：候選碼與測試同程序時，可以改寫測試讀到的值。只有宣告的黑箱檢查（期望值放在候選碼從未執行過的程序）受保護；`protection` 欄位標明 `blackbox`／`partial`／`same_process_only`（macOS 上受保護的兩級為 `blackbox_macos`／`partial_macos`，等級較低，#316）。`cairnwork-verify run --blackbox <宣告檔> --require-protection` 要求受保護才算 VERIFIED（`partial` 與 `partial_macos` 都算）；沒有 `--blackbox` 時直接拒絕（UNPROTECTED）。
- 不主張驗證通過就沒有缺陷：Nexus-new#2813（修正 PR #2856）是 Core VERIFIED、但獨立審查仍抓到拒絕檢查可被繞過的實例。驗證是證據，不是證明。

Nexus-new 是**參考**，不是搬家來源。決定與理由：knowledge `nexus/decisions/2026-10-19-cairnwork-owner-decision.md`；議會條文 A–I：`nexus/decisions/council-2026-10-19-cairnwork/CONSENSUS_R2.md`。

## 快速開始

```sh
uv tool install --from git+https://github.com/cairnwork/cairnwork.git cairnwork
cairnwork demo        # 五分鐘示範：隔離 clone、範圍檢查、驗證、Core VERIFIED（不需 GitHub／AI／API key）
```

完整安裝、`cairnwork init` 接真實 repo、平台註記見 [docs/QUICKSTART.md](docs/QUICKSTART.md)。

## 狀態

試點中（2026-10-20 → 2026-11-16）。目前只接一種任務：**小 bug 修正**（eia-task 格式：allowed_files ≤10、`pytest` 驗證）。

第一次 A/B（Cairnwork 過濾 vs 裸跑，28 題）：**打平、未贏**，原因與下一步見 [docs/results/2026-10-22-ab-run2.md](docs/results/2026-10-22-ab-run2.md)。
延後驗收擋錯能力量測（偵測器評估、方向性）：真實模型錯誤只有 7 份、擋下 5，不下結論；規則式突變 205/205 擋下；真實正確修補誤擋 0/83；驗證通過不等於沒有缺陷。見 [docs/results/2026-10-22-filter-mechanism.md](docs/results/2026-10-22-filter-mechanism.md)。
第三輪 A/B（2026-10-24，Gemini 與 Sonnet）：在 Sonnet 難題上，延後驗收擋下 11 個錯誤修正中的 10 個，holdout 通過的 36 個 0 個被擋；真錯分母低於預定的 20，判「資訊不足、方向正向」。交付精確率只從 15% 升到 19%：多數不可直接採用的修正是通過測試但需要修改，測試擋不到這類問題。失敗回饋重試與檔案提示都沒有幫助，不採用。擋錯幾乎全靠使用者自備的延後測試，Cairnwork 自帶的 P2P 與範圍檢查擋不到歷史假完成（離線重放的探索性子集 0/23）。
誤擋數字的前提（2026-10-28 補）：第三輪與其補題的題目，工單由看過正解的一方起草，延後測試也先在正解上確認通過才收題（不過的題剔除）。同樣 20 題改由沒看過正解的一方寫工單時，延後測試擋下已知正確的上游修正 13/20，經 Cairnwork 驗收擋下原本 holdout 通過的修正 11/20（原工單皆為 1/20）；主因是工單要求比修正的範圍廣，不是測試寫錯。所以「不誤擋」只在工單範圍和修正一致時成立；工單在修正之前、由不知道答案的人寫時，預期約一半的題會誤擋正確修正，被擋的修正需要人看。引用任何誤擋數字時，請一併說明工單是誰寫的。

產品本身不會重試。可見測試回饋（A2：把可見測試結果餵給 worker 再跑一輪）只是實驗性、需明確選用的能力（`experimental/visible_tests`，到期 2026-11-06）：預設關閉、呼叫端必須明確指定 `retries`，啟用時在該次嘗試旁記下實際多跑的輪數與回饋來源（`<run_root>/<attempt>.visible-tests.json`）；一次 A/B 的區間包含 0，尚未證明值得，也沒有證明有害。

## 能力入場規則

| 類別 | 例子 | 放哪裡 | 怎麼進來 |
|---|---|---|---|
| 必要保障 | 授權、隔離、重送去重、取消、重啟恢復、只有 Core VERIFIED 才算完成 | `src/cairnwork/` | 契約測試＋失敗情境測試＋恢復測試 |
| 實驗能力 | xray、codeintel、pregate、memory、belief、learning | `experimental/`，預設關閉 | 具名負責人；14 天到期（自「裸骨幹＋自有 A/B 基準就緒」起算），到期未證明就刪 |
| 正式能力 | 實驗能力升格 | `src/cairnwork/` | 在 Cairnwork 自己的 A/B 贏過裸骨幹（同任務、同模型、同評分器，事先登記門檻） |

- 舊版在 Nexus-new 有效，不算 Cairnwork 版有效的證據；沒有證據＝未證實，不是無用。
- 裸骨幹通過正常、失敗、重啟、回退四種演練之前，不搬任何實驗能力。
- 核心程式不得 import `experimental/`。

## 邊界

- 第一天的依賴只有 `nexus-core`（nexus-certify），以固定版本引用；不依賴 `nexus-runtime`。
- 工具類 sibling repo（RIE、opencli-reviewer、open-swe-runtime、workbench、repo-learning）只透過版本化的輸入輸出契約呼叫。nexus-deployment-lab 是部署控制端，不是下層工具。devspace 不接。
- sibling repo 永遠不得 import Cairnwork。
- Cairnwork 不得改動 Nexus-new#2721 的量測環境。

## 目前狀態：worker 停用

核心唯一的 worker 是 Agy 帳號池，2026-10-30 起停用。目前實際使用的只有 `cairnwork-verify` 這條驗收路徑；`cairnwork run`、Issue intake、route 的 worker 階段暫時無法跑完。另由誰來當 worker，另行決定。現行部署版本是 `1662f01`（2026-10-31 部署）。演練的現況見 [docs/DRILLS.md](docs/DRILLS.md)：用到真 agent worker 的演練標為「未重跑」，不需要 worker 的演練預計在現行 main 上重跑。

## 硬性限制（CI 強制）

- 單檔 ≤400 行、單函式 ≤80 行；獨立套件 `cairnwork_sandbox` 上限 1,200。
- 核心（`src/cairnwork/`）5,000 行是警戒預算，不是硬上限：超過時 CI 發 WARNING、不失敗，但 PR 必須簡短交代原因、替代方案（為何不用既有實作／契約／adapter）、責任（沒有第二權威或重複狀態）、成本與驗證。不要為了避開計數器新建 `cairnwork_*` 套件，程式放哪裡看責任。
- Ruff BLE001／S110 開啟；失敗情境測試證明失敗不會變成成功。
- import-linter：禁止循環、禁止核心 import `experimental/`。
- verifier sandbox 的見證測試在 macOS CI job（`test-macos`）一定會實際執行；缺少 sandbox-exec 時，這個 job 直接判失敗。

## 對外說法

README、發布說明、PR 描述只寫已經量到的結果，不寫預期的提升；主張一律照「完成有證據」定位（交付有程序證據），不講提高模型成功率。11/16 試點到期時，評估標準是有沒有在 A/B 贏過裸骨幹、四種演練有沒有通過，不看功能數或 PR 數。

## 參與方式

要改 Cairnwork，先寄 coord 信給整合負責人（`coord who repo:cairnwork`）取得範圍。同時開發的 Claude session 最多 2 個。

## 文件

- `docs/PRESERVED_BEHAVIORS.md`：試點必須保留的必要保障（議會 D 條）。
- `SECURITY.md`：事故應變。
- `docs/LESSONS_FROM_NEXUS.md`：Nexus-new 犯過的錯與 Cairnwork 的對應規則（開工前必讀）。
- `docs/DRILLS.md`：四種演練的實際結果。

## 開發

```
uv sync
uv run ruff check .
uv run lint-imports
uv run python scripts/check_size.py
uv run pytest
```

## License

Apache License 2.0 — see [LICENSE](LICENSE). Copyright 2026 James3014.
