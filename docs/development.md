# 開發指南

本指南提供開發工具的負責範圍、使用方式與測試維護入口。命令均在 repository
根目錄執行；產品操作見 [README](../README.md)，開發政策與檢查時機以
[AGENTS.md](../AGENTS.md) 為準。

## 環境與常用命令

使用 Python 3.14 與 repository 的 `.venv`；版本和依賴以
[pyproject.toml](../pyproject.toml)、[uv.lock](../uv.lock) 為準。

```bash
uv sync --locked --all-extras --python 3.14
./scripts/install-git-hooks.sh
```

一般文件檢查不需要模型服務。簡報建置與檢查（`scripts/presentations.sh`、
`scripts/check-presentations.sh`）另需 Node.js 18 以上與 npm，且執行
`scripts/presentations.sh setup` 前必須先裝好 Node.js 與 npm——
`setup` 只安裝鎖定的 npm 工具鏈（Marp CLI），不會安裝 Node.js 或 npm 本身。
離線 pytest 的簡報單元測試使用替代物隔離 Node.js 查找與編譯程序，
不以安裝 Node.js 為測試前提；實際簡報建置與一致性檢查仍需要 Node.js。
安裝器調整的 Git 設定及
執行環境限制見[注意事項](#注意事項)。

| 工具 | 負責範圍 | 修改時應維護的內容 |
| --- | --- | --- |
| `scripts/rebuild-env.sh` | 依 lock 重建本專案 `.venv`。 | 依賴變更同步設定、lock 及受影響套件測試。 |
| `scripts/format.sh` | 修改程式碼的 lint／格式修正。 | 品質政策維護於 `pyproject.toml`，流程實作見 `tooling/quality.py`。 |
| `scripts/check-docs.sh` | Markdown、連結及 SRS 結構與追溯引用。 | 改檢查器時維護 `tests/tooling/test_documentation.py`、`test_srs_requirements.py`；不執行引用的測試。 |
| `scripts/check-presentations.sh` | 文件品質、簡報重建一致性、頁碼及離線資源。 | 改建置／檢查行為時維護 `tests/tooling/test_presentations.py`；視覺與瀏覽器操作另行確認。 |
| `scripts/check-fast.sh` | Ruff、格式、strict Mypy、文件品質與 MCP 契約探索／上下文預算。 | 改工具契約時維護對應 MCP 測試；改機械檢查時維護 `tests/tooling/`。 |
| `scripts/check-full.sh` | 快速品質檢查與完整離線 pytest；不呼叫模型。 | 行為變更補對應模組及使用端回歸，修復問題須能重現原本失敗。 |
| `scripts/check-tooling.sh` | 快速品質檢查與完整 `tests/tooling`；不呼叫模型。 | 開發政策與已登錄開發工具；分類來源為 `tooling/git/change_scope.py`。 |
| `scripts/check-llm.sh codex\|local` | 模型實際使用 MCP 的探索、互動、確認及成果交付。 | 改模型可見契約或流程時維護受影響的 `tests/e2e/` 情境。 |
| `scripts/check-pr.sh PR編號` | 固定合併候選的文件／程式檢查與遠端版本核對。 | 改 Git 流程、範圍規則或審查證據時維護 `tests/tooling/` 對應測試。 |
| `scripts/claim-issue.sh 編號 --repo OWNER/REPO --user LOGIN` | 核對 CLI 登入者並將本人加入 issue assignees。 | 改指派流程時維護 `tests/tooling/test_claim_issue.py`。 |
| `scripts/cleanup-pr.sh PR編號 --branch 分支` | 核對已合併 PR 後刪除符合條件的本地分支。 | 改清理條件時維護 `tests/tooling/test_pr_cleanup.py`。 |

Shell 入口位於 [scripts/](../scripts/)，Git hooks 位於 [.githooks/](../.githooks/)，
實作集中於 [tooling/](../tooling/)。測試按 domain、app、adapters、MCP、整合流程及
開發工具放在 [tests/](../tests/)；新增能力時依責任擴充相應測試，避免只依檔名選取。
測試案例、測資與斷言以測試程式為準，不在本指南逐項重述。

離線測試可直接使用 `uv run --all-extras pytest`，加檔案路徑或 `-k` 執行相關範圍。
`check-full.sh` 一律跑完整離線套件；純開發政策／已登錄開發工具使用
`check-tooling.sh`。產品、依賴、共用測試設施及無法確認的變更仍跑完整套件。
提交與 PR 的檢查分流見下方流程。

### 依賴相容性限制

本專案使用 Python 3.14、XGBoost 3 及 FLAML 基礎套件；可安裝不代表所有上游
功能均已驗證。修改 ML 依賴時須保留各 learner 的實際訓練與
評估驗證，入口見 [tests/domain/ml/](../tests/domain/ml/) 及
[整合測試](../tests/integration/)。安裝問題亦見 [README](../README.md)。

### 容器建置與驗證

[Dockerfile](../Dockerfile) 使用與專案相同的 Python 次版本，透過
`uv sync --locked --no-dev --no-editable` 安裝執行環境；Ruff、Mypy 與內建策略的
ML 套件屬執行期依賴，不能因為容器部署而移除。品質設定隨 wheel 收錄。
映像採多階段建置，執行層只複製安裝環境；[.dockerignore](../.dockerignore) 限定傳入建置的檔案。

獨立策略 worker 使用 `strategy-runtime` target。完整離線測試包含真實 Linux 容器邊界
檢查，需先準備可透過本機 Unix socket 連線、支援 cgroup v2 資源限制的 Docker Engine
與此映像；所有支援平台都不接受 SSH 或 TCP 遠端端點。建置另需 Docker CLI 的
Buildx 元件，不能只以 Engine 可用判定工具已齊備。先執行 `docker buildx version`，
再以 `docker buildx create --help` 確認包含 `docker-container` driver、
`docker buildx build --help` 確認支援 `--load`；缺少命令或能力時須先安裝或更新
Docker 安裝來源提供的 Buildx 元件，不能繼續下列建置。

在 repository 根目錄為本次檢查建立專用 builder 與標籤，明確選用 builder 而不切換預設 builder：

```bash
tradingdev_check_id="$(uv run --no-sync python -c 'import uuid; print(uuid.uuid4().hex)')"
tradingdev_check_builder="tradingdev-check-${tradingdev_check_id}"
tradingdev_check_image="tradingdev-strategy-runtime:check-${tradingdev_check_id}"
docker buildx create --name "$tradingdev_check_builder" --driver docker-container
docker buildx build --builder "$tradingdev_check_builder" --load \
  --target strategy-runtime -t "$tradingdev_check_image" .
export TRADINGDEV_STRATEGY_IMAGE="$tradingdev_check_image"
```

macOS 可使用 Docker Desktop 提供的 Linux Engine。
測試本身不下載映像；缺少 daemon、
必要能力或預建映像會失敗。`TRADINGDEV_STRATEGY_IMAGE` 可指定專用測試標籤，執行前
會解析為固定 image ID。建立 adapter 前，以 `TRADINGDEV_RUNTIME_LIMITS` 的 JSON 物件設定測試資源政策；
未設定時使用預設政策，直接呼叫明示的 `limits` 優先。可設定欄位、預設值及
欄位間限制以 [`RuntimeLimits`](../src/tradingdev/domain/runtime.py) 為準。

直接整合或診斷 adapter 時，查閱[容器執行 adapter](../ARCHITECTURE.md#容器執行-adapter)，
取得 `DockerRuntime.resolve/open`、`ContainerSession.exchange`、生成策略呼叫與身分綁定、
清理失敗判定及 `recover_abandoned` 的契約。傳輸、程序身分與故障清理的驗證入口為
[替代 daemon 的 adapter 測試](../tests/adapters/test_container_runtime.py)及
[真實容器測試](../tests/integration/test_strategy_isolation.py)。
生成策略資料協定另由 [codec 測試](../tests/adapters/test_frame_codec.py)及
[直接 worker／proxy 測試](../tests/integration/test_generated_protocol.py)驗證。

變更 worker、資料協定或其依賴後，須從待驗證內容重建策略映像，再執行相關測試。
固定 image ID 不會隨標籤重建而改變。保留上述變數值；確認本次 host 工作已停止、
所有關聯執行容器均已停止並移除，且映像沒有其他執行引用後，才在同一個 shell 清理：

```bash
docker image rm "$tradingdev_check_image" &&
  docker buildx rm "$tradingdev_check_builder"
```

移除專用 builder 時不加 `--keep-state`，會一併移除其建置快取。
只清理本次資源，不使用 force 或全域 prune。任一步驟失敗或無法確認清理時，
停止後續清理並保留剩餘資源、控制目錄及紀錄，依上述 adapter 復原契約處理。

MCP runtime target 含 Docker CLI，Compose 只把本機 socket 掛給可信控制端；操作權限與
安裝設定由 [README 的 Docker 部署](../README.md#使用-docker-部署) 說明。

若開發檢查回報未確認清理，保留所列控制目錄；停止相應 host 工作並恢復原 Docker daemon
後，依[容器執行 adapter 的復原契約](../ARCHITECTURE.md#容器執行-adapter)選定控制目錄並重試。

容器修改除完整離線檢查外，須驗證 Compose 解析、實際建置與 HTTP MCP 連線，
並檢查非 root 身分的工作區寫入、生成策略驗證所需工具／套件、容器重建後資料讀取，
以及錯誤 Host／Origin 的拒絕行為。使用獨立 Compose project、臨時工作區及映像標籤，
結束後先停止並移除該 project 容器，再清理測試資料與專用映像／建置快取；
不要清理共用 Docker 資源。未實測的 CPU 架構與 NAS 平台須明列限制。
使用者部署、設定與備份操作統一見 [README](../README.md#使用-docker-部署)。

## 測試設計與精簡

本節是落實 [AGENTS.md 測試政策](../AGENTS.md#測試與清理) 的本機設計基準。
涉及測試設計、修改、刪減或品質審查時讀取本節即可，不需閱讀外部準則或整份開發指南。
授權、必要檢查與清理依 AGENTS.md；下列方法按變更風險選用，不增加固定比例或工具門禁。

1. **撰寫前確認責任**：先辨識要保護的需求／契約、觸發情境與預期錯誤，再查既有
   測試。選擇能可靠捕捉該錯誤、成本合理的層級；高層測試聚焦跨層接線、序列化、
   設定傳遞、狀態與副作用，避免在各層重跑完整業務分支。不同使用端、模型實作及
   程序邊界可能有獨立風險，斷言相似不代表重複。
2. **依風險選案例**：從正常、邊界與失敗路徑選擇代表輸入。同樣處理方式的輸入
   可歸為等價類別，再涵蓋邊界值、狀態轉移及會改變結果的條件組合，避免無理由
   枚舉同類數值。公開預設值、schema 約束與回傳型別若影響契約，仍有驗證價值。
3. **斷言對準行為**：預期值來自契約、可手算案例、獨立參考或明確不變量，
   避免複製被測實作當答案。比較重複結果可驗證確定性，不能取代正確性與輸入
   敏感性驗證。名稱反映實際保證；測平倉先確認進場再確認期限內退出，測設定
   生效需觀察設定的影響，測 JSON 相容性就實際序列化，不能只檢查欄位或長度。
   內部名稱、簽名與呼叫順序，僅在其本身是必要契約或保護副作用時固定。
4. **避免斷言空跑**：檢查空集合、未進入的條件與零次迴圈，確保目標情境確實
   發生。測拒絕時讓其餘條件有效，核對錯誤原因與必要副作用，避免因別的錯誤
   而通過。刻意測空結果或不拋錯時，明確檢查該接受條件。
5. **控制替代物與重用**：mock／fake 適合隔離外部依賴、昂貴流程或製造失敗，
   不替換正在驗證的行為；只檢查 mock 回傳值不代表真實整合成立。共用契約可
   用有可辨識名稱的參數化案例，重複設定可抽成隔離 fixture，同時保留各實作及
   邊界必要的真實路徑。允許有助理解的重複，避免為縮短行數建立複雜框架，
   或讓案例依賴執行順序與前一案例的可變狀態。
6. **完成前驗證偵錯能力**：回歸案例先確認能因原缺陷失敗，再驗證修正後通過。
   高風險或斷言效力有疑慮時，可用反例、隔離環境內可還原的故障注入或局部
   mutation testing 確認測試會拒絕錯誤行為，不需每次跑全套 mutation testing。
   記錄實際驗證範圍；單一測試漏抓不代表整套失效，全部通過也不證明沒有缺陷。
7. **精簡前核對保護能力**：比對輸入、執行路徑、契約與故障種類，在差異審查／
   完成回報指出保留的測試及涵蓋範圍；有獨立邊界風險就保留。弱斷言但需求仍
   必要時優先改寫。資料洩漏、執行身分、保存完整性、授權與程序清理的驗證不能
   因精簡而遺失。重複設定與多餘案例分別評估，不只憑名稱、行數、coverage
   重疊或一次故障注入決定刪除；沒有合理預期效益時不為減少行數而改寫。

## 更新文件

| 文件 | 維護責任 |
| --- | --- |
| [軟體需求規格](requirements.md) | 產品需求、驗收條件與契約／驗證入口；按責任分冊。 |
| [README](../README.md) | 使用者安裝、操作與結果解讀。 |
| [架構](../ARCHITECTURE.md) | 模組責任與跨層流程。 |
| [策略契約](strategy_contract.md) | 策略作者的 Python／YAML、訊號、訓練與 revision 要求。 |
| [執行產物](run_artifacts.md) | Workspace、身分、保存格式及歷史查詢入口。 |
| [ML 研究](ml_research.md)、[執行計畫](execution_plans.md) | 各自的輸入、驗證、保存及執行邊界。 |
| [績效產物](performance_artifacts.md)、[報告](reports.md) | 保存數值及觀察值的語意、報告呈現與交付。 |
| 本指南 | 工具入口、負責範圍、操作方式與測試維護位置。 |
| [AGENTS.md](../AGENTS.md) | 唯一代理開發政策來源。 |

依 [文件政策](../AGENTS.md#政策與溝通) 判斷本次變更是否改變使用方式、對外語意、
資料保存／讀取、相容性或安全邊界。修正受影響的敘述；既有說明仍正確且足夠時，
不因實作或測試調整再追加段落。契約保留行為與限制，schema、catalog、常數與
正式 model 負責可機械取得的定義，不逐欄複製到 Markdown。

整理契約時先找主要維護來源，合併重複敘述，再提供按需入口。參照應包含「何時讀、
檔案與類別／函式或工具、可取得的資訊」，例如設定欄位查 `BacktestRunConfig`，
MCP 使用端則取得 `get_strategy_contract(section="configuration")`。讀者需要的
範例、重要語意及失敗處理仍保留；新增小文件不是精簡的必要步驟。

新增、改名或拆分契約時，同步檢查 [review_scope.py](../tooling/review_scope.py) 的責任選取
及 [test_review_scope.py](../tests/tooling/test_review_scope.py) 的證據涵蓋。新文件會自動納入
審查，但未知章節保守保留，拆檔本身不代表減少上下文。量測應分開報告文件閱讀量、
審查輸入與產品 MCP；不把 bytes 當成 tokens。

PR 文件 reviewer 無法自行開啟參照。審查需要的正式定義若未包含在原始證據中，
以 `--review-context-for SCOPE:PATH` 補入同一候選 Git 版本的完整檔案；跨範圍問題
使用 `cross_scope`。參照本身不證明內容正確，也不會自動載入來源；必要內容缺失時
依 finding 補齊證據後重查，不為通過審查把 schema 重抄回文件。

一般文件只走文件檢查；已登錄簡報走簡報專項；開發政策與已登錄開發工具走工具
檢查，其餘程式／依賴或未知變更走完整檢查。分類規則見
[AGENTS.md](../AGENTS.md#git-hooks-與本機-pr-審查)。
文件檢查不執行文件中的命令或驗證外部網址，也不代替語意與操作審閱。

### SRS 維護與檢核

`scripts/check-docs.sh` 自動檢查 `docs/requirements.md` 與 `docs/requirements/`
中的需求。規則及審查責任唯一來源是 [requirements.py](../tooling/requirements.py)：
`check_requirements` 拒絕重複／格式錯誤的編號、缺少需求／驗收／契約／驗證欄位、
未從入口連到的章節，以及未登錄於 `DOCUMENT_SCOPES` 的需求文件。
同一份責任登錄直接供 reviewer 選取文件，不另維護第二份章節清單。

需求使用二級標題 `FR-EXEC-001 名稱` 或 `NFR-UI-001 名稱`，四個頂層清單欄位以
`**需求**：`、`**驗收**：`、`**契約**：`、`**驗證**：` 開始。
契約欄連到本機 Markdown 詳細契約，驗證欄連到 `tests/` 中的 `test_*.py`；
沒有自動化證據時，可用 `人工驗收：` 說明操作、預期結果與限制。
檢查器核對這些格式與引用存在性，失敗會指出檔案、需求及原因；不匯入或執行測試，
不驗證測試函式、驗收文字的語意或覆蓋充分性。引用是查核入口，不是通過收據。
SRS 入口與章節都不存在時允許尚未引入 SRS 的版本；部分缺失或導航斷裂則失敗。

SRS 的結構與引用由文件檢查驗證；需求與契約的一致性納入既有候選審查，
操作及限制見[PR 檢查](#2-在-github-建立-pr交由審閱者檢查)。

### 簡報的編輯與輸出

[簡報入口](talks/tradingdev-introduction/README.md)提供編輯、預覽與發布操作。
編輯環境須有 Node.js 18 以上及 npm，再初始化鎖定的 Marp 工具鏈：

```bash
./scripts/presentations.sh setup
```

`setup` 會下載 npm 套件；一般 build／check 使用已安裝工具鏈，不自動安裝。
執行 `setup` 前必須已安裝 Node.js 與 npm——它只安裝鎖定的 npm 工具鏈
（Marp CLI），不會安裝 Node.js 或 npm 本身。若報錯提示
`Node.js is unavailable` 或 `Node.js and npm are required`，
請先安裝 Node.js 與 npm，而不是執行 `setup`。
依賴更新須同步 `tooling/marp/package-lock.json` 並重新初始化。

#### 在 VS Code 儲存時自動編譯

[VS Code Tasks](../.vscode/tasks.json) 提供 `slides: watch` 與 `slides: build`。
完成初始化後，在可信任的工作區允許自動工作，或以 **Tasks: Run Task** 啟動。
監看時儲存來源會重建 HTML；結束使用 **Tasks: Terminate Task**。
詳細操作見[簡報入口](talks/tradingdev-introduction/README.md#編輯與預覽)。

#### 手動輸出與預覽

```bash
./scripts/presentations.sh build
./scripts/check-presentations.sh
uv run python -m http.server 8765 --bind 127.0.0.1 \
  --directory docs/talks/tradingdev-introduction
```

瀏覽 `http://127.0.0.1:8765/` 確認版面、頁碼、導覽與講者模式；結束伺服器按
`Ctrl+C`。修改來源或樣式後同步提交重建的 HTML。

簡報採整包離線交付，`assets/` 圖片及 `evidence/` 報告沿用相對路徑。
`scripts/check-presentations.sh` 另核對交付 HTML 的 `href`、`src`、`poster`、`xlink:href`
靜態引用與 HTML 片段；這些本機引用須指向交付範圍內的檔案，整包不接受符號連結。
報告內的 CSS、`srcset` 與 JavaScript 動態資源不在此連結檢查範圍，須另用瀏覽器驗證。
`scripts/presentations.sh package --output <新資料夾>` 檢查後建立資料夾及同名 ZIP，
不覆寫既存輸出。`scripts/stage-presentations.sh` 只複製既有成品至固定的
`site-dist/tradingdev/` 並替換舊發布內容，不編譯或安裝工具；供 Wrangler 部署時呼叫。
打包、解壓與發布的使用方式見[簡報編輯指南](talks/tradingdev-introduction/README.md)。
專項檢查以臨時目錄重建並比對，不覆寫工作樹；缺少工具鏈或輸出不同步會失敗。
可用 `TRADINGDEV_PRESENTATION_TOOLCHAIN` 指定另一套已初始化且 lock 相符的工具鏈。

## MAE 研究原型

[research/mae_analysis.py](../research/mae_analysis.py) 是獨立的最大不利變動研究原型，
不屬於正式 Dashboard。先準備 `data/processed/btcusdt_1m_2024_2025.parquet`，
包含可轉換為 UTC 的 `timestamp` 與數值 `high`、`low`、`close`：

```bash
uv sync --locked --extra dashboard
uv run --locked --extra dashboard streamlit run research/mae_analysis.py
```

開啟終端機顯示的網址；結束按 `Ctrl+C`。此入口不下載行情。
日期範圍包含起訖日的 UTC 全日，以結束日次日 00:00 為排他上界。
分析只保留所選期間內具完整未來持倉視窗的進場點；資料不足時顯示警告，
不產生分位數或停損觸發率。可擴大日期範圍或縮短持倉視窗後重新分析。

## 研究成果工程回饋

需要把策略案例中的共通邏輯、檢查或方法整合回專案時，使用
[research-feedback skill](../.agents/skills/research-feedback/SKILL.md)。它提供來源固定、
共用價值判斷、元件整合、使用端探索與驗證的工作流程；Git、審查及授權政策仍由
[AGENTS.md](../AGENTS.md) 管理。單純建立策略或查看回測不需要此 skill。

在能存取 repository 與來源 workspace 的開發助手中呼叫 `$research-feedback`；
若客戶端未發現 repository skills，明確要求讀取上述 `SKILL.md` 再執行。
只有 MCP 工具存取權的客戶端無法藉此修改 server 程式，也不假設客戶端能讀 server
本機路徑。提供實際可讀取的來源，例如：

> 使用 $research-feedback，讀取 `/absolute/workspace-a` 的策略與指定版本，及
> `/absolute/workspace-b` 的另一個策略與指定版本。這些來源允許用於共用元件開發；
> 僅分享抽取後的邏輯與去識別化合成測資，保留私人策略、行情與原始報告。
> 請判斷是否有值得重用的機制，若有則在本專案完成整合、使用入口與驗證。

先提供策略 ID、選定 revision（或明示採目前版本）、實際授權範圍，以及相關 run／
筆記（若有）；不必為了使用 skill 重跑研究。只有評估需求時可以明示「唯讀分析，
不修改」。已有授權不重複確認，
缺少來源或可共用範圍時補齊後才處理相依工作。若沒有合適的抽取候選，回報理由與
證據即可，不為交付而新增元件。

原 workspace 的 revision、設定、驗證證據、結果與筆記保持唯讀。要驗證新的使用方式，
在隔離工作區建立新策略版本；匯入的共用程式不受舊 revision 雜湊完整凍結，須記錄
實作版本並驗證受影響使用端。需要使用者續查的驗收成果須保留，不能當測試暫存清理。

這是由人啟動、開發助手執行的流程，不會在每次策略保存時自動運行，也不會自行
掃描其他 workspace、分享私人研究或發布更新。效果以實際抽取、使用端採用及驗證
證據判斷；合成案例只能驗證流程，不能證明真實多人研究的改善成效。

## 選擇性 LLM 測試

此工具驗證模型透過真實 MCP 完成策略研究互動及成果交付。修改模型可見的指引、
工具 schema／回覆契約、策略生成修復或模型整合層時，依
[執行時機](../AGENTS.md#執行時機) 選擇受影響情境。
測試入口為 [scripts/check-llm.sh](../scripts/check-llm.sh)，情境與驗證程式位於
[tests/e2e/](../tests/e2e/)，provider 選項定義於 [tests/llm_plugin.py](../tests/llm_plugin.py)。

```bash
./scripts/check-llm.sh codex --llm-timeout 1800
./scripts/check-llm.sh local --llm-model qwen3.8:27b --llm-timeout 1800
```

Codex 需要已登入的 CLI 與所選模型存取權；Local 需要已啟動且支援工具呼叫的本機
服務，預設 `http://localhost:11434/v1`，以 `--llm-base-url` 指定其他 loopback 位址。
工具不下載模型、不自動切換 provider；所選能力不可用會失敗。

Codex 產品流程的預設參考配置為 `gpt-6.1-sol` 與 `high`。解析順序為 `--llm-model`／
`--llm-reasoning-effort`、專用環境變數 `TRADINGDEV_LLM_MODEL`／
`TRADINGDEV_LLM_REASONING_EFFORT`、固定基準；不沿用宿主或文件審查的模型設定。
啟動模型回合前核對及記錄實際模型與推理強度，所選能力不可用或不符即失敗。
推理強度的可接受值由 [provider 選項](../tests/llm_plugin.py) 的
`CODEX_REASONING_EFFORTS` 定義；不支援會自動委派的 Ultra。
這些情境驗證單一客戶端透過 MCP 操作，不允許子代理或其他原生工具代做，
也不修改使用者的全域 Codex 設定。

此處指定的是受測模型。驗證某個模型的相容性時，明確指定該模型與推理強度；
其他模型的結果不能代替。此測試不執行程式碼審查或 PR 文件一致性審查。

以 `-k` 選取相關情境，省略時執行全部。可先列出目前可用情境，不呼叫模型：

```bash
./scripts/check-llm.sh codex --collect-only -q
./scripts/check-llm.sh codex -k novice --llm-timeout 1800
```

依變更責任選擇與維護測試：

| 責任範圍 | 測試入口 |
| --- | --- |
| 策略生成、修復與既有結果查詢 | [test_llm_workflows.py](../tests/e2e/test_llm_workflows.py) |
| 自然需求、必要資訊追問與工具探索 | [test_llm_novice_intake.py](../tests/e2e/test_llm_novice_intake.py)、[test_llm_discovery.py](../tests/e2e/test_llm_discovery.py) |
| 執行計畫、使用者決策、訓練與生成策略隔離／資源限制／清理復原指引 | [test_llm_execution_plans.py](../tests/e2e/test_llm_execution_plans.py)、[test_llm_strategy_execution_guidance.py](../tests/e2e/test_llm_strategy_execution_guidance.py) |
| 自動 walk-forward 設定、尾端覆蓋與結果交付 | [test_llm_automatic_walk_forward.py](../tests/e2e/test_llm_automatic_walk_forward.py)（`-k automatic_walk_forward`） |
| 固定參數比較、已保存 scope 比較／排名與參數提案 | [test_llm_comparison.py](../tests/e2e/test_llm_comparison.py)、[test_llm_research_proposal.py](../tests/e2e/test_llm_research_proposal.py) |
| ML 研究 | [test_llm_ml.py](../tests/e2e/test_llm_ml.py) |
| 已保存結果解讀、研究筆記更新、封存匯出與既有封存續讀 | [test_llm_research_delivery.py](../tests/e2e/test_llm_research_delivery.py) |
| 授權後的草稿清理 | [test_llm_cleanup.py](../tests/e2e/test_llm_cleanup.py) |

測試使用隔離工作區、固定合成行情與模擬使用者，不下載市場資料；完成驗證後清理。
它不替真人保留報告，也不驗證桌面客戶端的互動。自然語言解讀仍須審閱輸出的最終
回覆與報告評語；機械斷言通過不等於語意正確。使用者實際驗收的成果保存遵守
[AGENTS.md](../AGENTS.md#測試與清理)。

`--llm-timeout` 是每個情境的期限。長流程需要足夠上下文；已驗證的本地 Qwen 配置
為 64K，但不代表所有模型的最低需求。容量不足須調整服務配置後重跑完整情境。
Local 可用 `--llm-temperature`、`--llm-reasoning-effort` 覆寫支援的採樣設定；
未指定時使用本地服務預設，不讀取 Codex 測試的專用環境變數。
`--llm-temperature` 不適用於 Codex。模型版本與設定不同，驗證結果不能直接互相替代。

### 量測模型上下文

```bash
uv run --no-sync python -m tooling.context_budget
uv run --no-sync python -m tooling.context_budget --tools list_strategies get_strategy_contract
uv run --no-sync python -m tooling.prompt_contracts
```

| 工具 | 負責範圍與維護入口 |
| --- | --- |
| [context_budget](../tooling/context_budget.py) | 量測實際註冊的指引、工具投影及 MCP wire metadata；修改量測時維護 `tests/tooling/test_context_budget.py`。 |
| [prompt_contracts](../tooling/prompt_contracts.py) | 機械檢查契約探索、schema、明示章節引用與 UTF-8 預算；已納入 `check-fast.sh`，修改時維護 `tests/tooling/test_prompt_contracts.py`。 |

兩者使用可清理的臨時工作區，不呼叫模型、下載行情或執行回測。Bytes 不是 tokens；
指定工具集合的量測也不能當成完整產品成本。預算集中於 `prompt_contracts.py`，
超量須檢查內容歸屬，不以截斷內容通過檢查。
Local 真實模型測試另記錄 request 增量與峰值；Codex 完整上下文及內部壓縮不在此量測範圍。

## 開發階段的程式碼審查

依 [AGENTS.md](../AGENTS.md#開發階段的程式碼審查) 安排獨立唯讀 reviewer，提供任務目的、
基準／受查版本、差異範圍與相關契約。保持受查內容穩定，核實 findings、修正後複查。
使用 CLI 時明確指定 review 模型及推理強度；以下範例使用 `gpt-6.1-sol` 與 `high`：

```bash
codex -c 'review_model="gpt-6.1-sol"' -c 'model_reasoning_effort="high"' \
  review --base origin/main
```

| 命令 | 適用範圍 |
| --- | --- |
| `codex review --base origin/main` | 相對已取得遠端主線的分支差異；先確認工作樹乾淨並 fetch。 |
| `codex review --uncommitted` | 已暫存、未暫存及未追蹤內容；先排除其他任務修改。 |
| `codex review --commit HEAD` | 指定 commit 引入的差異。 |

CLI 參數以 `codex review --help` 核對。已由獨立 reviewer 涵蓋且無未解疑慮的相同內容
可沿用審查結果。程式碼審查、離線測試、文件一致性與真實模型流程驗證各有用途，
不能互相替代；一般 commit／push 不會自動執行模型 code review。

## 接手 issue

決定負責某個 issue 時，將自己的 GitHub 帳號加入 **Assignees**，讓協作者知道
由誰接手；僅閱讀或分析不算接手。AI 協作的判斷與授權依
[Issue 接手與指派政策](../AGENTS.md#issue-接手與指派)。

準備好 repository 的 `.venv` 與已登入本人帳號的 GitHub CLI（`gh`），代入實際值：

```bash
./scripts/claim-issue.sh 123 --repo OWNER/REPO --user YOUR_LOGIN
```

腳本僅支援 `github.com` 的開啟 issue，核對 `YOUR_LOGIN` 與登入帳號相符，
只新增本人、保留其他 assignees，並讀回確認；已指派時不重複變更。
若失敗或結果未確認，依輸出的 issue 連結查看 **Assignees**，必要時手動設定；
已授權的本機工作可繼續。參數說明可用 `./scripts/claim-issue.sh --help` 查看。

## 從開發到合併

以下以 `origin`、`main`、`feature/my-task` 示範，請代入實際名稱。
分支、提交與授權政策見 [AGENTS.md](../AGENTS.md#工作樹與分階段提交)。

### 1. 分階段提交並推送

更新遠端主線後建立 task branch；每階段完成相關測試與必要審查，再明確提交檔案：

```bash
git fetch origin main
git switch -c feature/my-task origin/main
./scripts/git-flow-commit.sh "feat: add strategy validation" path/to/changed_file.py
git push -u origin feature/my-task
```

已有開發分支時沿用。Commit hook 依暫存內容執行文件、簡報或快速檢查；一般 push
不執行完整 pytest 或呼叫模型。本機 hook 的主線推送保護限於 GitHub remote。

交付前對整個任務差異取得機械可讀的檢查計畫；以下 `origin/main` 應替換成實際任務基準：

```bash
uv run --no-sync python -m tooling.git.change_scope --base origin/main --tree HEAD
```

有尚未提交的最後階段時，先暫存相關檔案並以 `--staged` 取代 `--tree HEAD`，base 仍涵蓋
先前所有階段，不能只比較 `HEAD` 與最後的暫存內容。`--repo <path>` 可指定 checkout。
`verification_planned` 回覆固定 tree 身分與 `ChangeScope.payload` 產生的計畫，並非通過證明。
`delivery_profile` 指定任務交付要跑的 `scripts/check-<profile>.sh`；`commit_profile`
供 hook 使用，`candidate_checks` 是 PR／本機合併候選的檢查順序。
每階段仍只要求受影響的相關測試，當次 PR 候選另外獨立檢查；計畫不新增逐階段完整檢查。
暫存模式不包含未暫存或未追蹤內容；這時提交使用 `git-flow-commit.sh "type: message"`，
不再傳檔名。工具失敗時不能假設可走較輕的分流。

### 2. 在 GitHub 建立 PR，交由審閱者檢查

```bash
./scripts/check-pr.sh 27
```

須有乾淨且已提交的工作樹、可存取 repository 的 `gh`，以及開啟且指向主線的 PR。
工具在隔離 repository 檢查合併候選，不切換開發分支：

| 候選變更 | 執行檢查 |
| --- | --- |
| 一般文件 | 文件格式、連結與 SRS 結構；涉及 SRS 時再執行 Codex 一致性審查。 |
| 已登錄簡報 | 文件與簡報專項；混合 SRS 時再執行 Codex 審查；視覺操作仍須人工確認。 |
| 開發政策／已登錄開發工具 | 必要的簡報專項、Codex 文件一致性審查、快速品質與完整 `tests/tooling`。 |
| 產品／依賴／共用測試設施／未知或混合產品變更 | 必要的簡報專項、Codex 文件一致性審查、快速品質與完整離線 pytest。 |

PR 與本機候選共用 [change_scope.py](../tooling/git/change_scope.py) 分類器，
依不可變 Git tree 核對新增、修改、刪除、改名兩側及檔案 mode；未知內容保留完整檢查。
開發工具分流不等於整個 `scripts/` 或 `tooling/` 白名單，混入產品變更即跑全套。

同一次 PR 檢查中若只有主線前進，工具會重新取得合併候選。PR 身分與 head 必須不變，
且 `change_scope.presentation_only_advance` 須確認更新僅含已登錄簡報檔案、與 PR 路徑
不重疊，及相同 blob／mode 差異完整套入新候選，才可沿用本次已完成的檢查。
新候選仍須通過簡報 snapshot；成功輸出 `pr_base_refreshed` JSON，包含 `reused_tree`、
最新 base／head／tree 與補做的 `checks`，審閱者仍須確認新增差異的語意與必要視覺行為。
主線更新含編譯工具、設定、一般文件、產品變更或改寫歷史不適用；PR 自身涉及簡報或其工具
也不適用，因為不同檔案可能互為審查脈絡。補驗證期間再次變動也會失敗。
此路徑不重用跨次執行的 receipt，檢查結束後仍須依下節核對即時版本。

真實模型策略測試另依變更選取。涉及 SRS 的文件／簡報、開發工具與完整程式候選的文件審查需要 Codex 登入與額度；
這一步預設使用 `gpt-6-luna` 與 `high`；以 `TRADINGDEV_DOC_REVIEW_MODEL`、
`TRADINGDEV_DOC_REVIEW_REASONING_EFFORT` 分別覆寫模型及推理強度，例如：

```bash
TRADINGDEV_DOC_REVIEW_MODEL=gpt-6-luna ./scripts/check-pr.sh 27
```

文件審查會帶入完整的變更檔案及按責任選取的既有文件原文，輸入量不只取決於
修改行數；先用下方 `--plan-only` 量測證據與 prompt 大小，再依容量與成本選擇模型。
上述設定僅適用於文件審查，不影響 `check-llm`。審查器忽略使用者的全域 Codex
設定，並輸出選定模型及推理強度；開發階段 `codex review` 的模型仍須另行指定。
舊的共用環境變數 `TRADINGDEV_CODEX_MODEL` 不再使用，請按用途改用上述專用設定。
PR 文件審查每次只使用選定模型與推理強度；執行失敗直接回報，不自動切換模型。
審查程式與來源入口見
[review_docs.py](../tooling/review_docs.py)、[review_scope.py](../tooling/review_scope.py)。

先列出責任範圍或規劃固定 Git 版本的證據；以下命令不呼叫模型、不代表檢查通過：

```bash
uv run --no-sync python -m tooling.review_docs --list-scopes
uv run --no-sync python -m tooling.review_docs \
  --repo /absolute/path/to/repository --base origin/main --tree HEAD --plan-only
```

通常使用自動推導的範圍；需要調整時，`check-pr.sh` 支援：

| 選項 | 使用目的 |
| --- | --- |
| `--review-scope SCOPE` | 明確增加審查責任範圍；不可漏掉變更所屬範圍，可重複。 |
| `--review-context PATH` | 為所有批次補入候選 Git 中的完整文字檔，可重複。 |
| `--review-context-for SCOPE:PATH` | 僅為指定責任範圍或 `cross_scope` 補入完整檔案，可重複。 |
| `--max-evidence-bytes`、`--max-prompt-bytes`、`--max-total-prompt-bytes` | 分別限制唯一證據、單批 prompt 與總 prompt；先量測，再依模型容量明確設定。 |
| `--documentation-timeout-seconds` | 文件審查所有批次共用的期限。 |
| `--snapshot-timeout-seconds` | 品質／測試 snapshot 的期限；不改變測試範圍或工具自身期限。 |

例如為單一範圍補上必要來源，並依實測耗時設定期限：

```bash
./scripts/check-pr.sh 27 \
  --review-context-for interfaces:src/tradingdev/mcp/server.py \
  --documentation-timeout-seconds 900 --snapshot-timeout-seconds 3600
```

請以實際規劃的 scope／檔案代換。預設值與其他選項以 `scripts/check-pr.sh --help`
為準。文件審查範圍選取不縮減所選分流的測試；變更檔案保留完整內容與 diff，相關文件按責任取原文。
缺少必要證據、容量不足、finding 或逾時均須修正後重查，不能截斷內容或忽略失敗。

Codex 非零退出時，檢查會連同批次身分回報退出碼、stderr 尾端及 JSON
`error`／`turn.failed` 事件的錯誤類型、`code`、`message` 或字串 `error`。
stderr 與事件診斷各限制為 4,000 個 Unicode 字元，超量會標示 `[truncated]`；
這只限制錯誤輸出，不截斷審查證據。事件不會整份輸出，缺少可辨識診斷時會明示。
錯誤訊息仍可能包含服務回傳的敏感內容，分享日誌前須檢查；檢查器不會自動發布日誌。
非零退出、零退出但有失敗事件、無效事件或工具呼叫均不算通過，須排除原因後重新檢查。

文件審查及 Git 檢查入口以退出碼 `86` 表示程序清理未確認，外層自動保留相關工作區。
stderr JSON 診斷契約見 [ProcessCleanupError.payload](../tooling/process_guard.py)，
文字 `message` 僅供顯示。文件審查在同一程序內彙整 batch 的保留路徑及中斷狀態；
跨 CLI 時各程序分別輸出 JSON，外層依退出碼保留自己的工作區，不彙整子程序的欄位。
一般失敗或已確認停止的逾時仍自動清理。

長時間檢查保留完整日誌，透過[完成通知 skill](../.agents/skills/wait-for-check/SKILL.md)
等待原執行結束；完成後讀退出碼與摘要，有異常再讀診斷。未確認程序停止前保留臨時目錄。

### 3. 在 GitHub 審閱並合併

完成檢查與評論處理後，核對即時遠端版本與檢查輸出的 base／head SHA：

```bash
git ls-remote origin refs/heads/main refs/pull/27/head
```

任一版本改變都須重查。確認後才合併；本機檢查不會鎖住 GitHub 的遠端變更。

### 4. 合併後更新 main、清理本機分支

```bash
git fetch origin main
git switch main
git merge --ff-only origin/main
./scripts/cleanup-pr.sh 27 --branch feature/my-task
```

清理工具核對 PR、分支身分與祖先關係，只刪除符合條件的本地分支；無法確認時保留。
Squash／rebase 合併可能無法證明祖先關係。遠端分支、worktree 與 branch config
不由此工具刪除；遠端刪除須另核對來源倉庫及使用者授權。

## 尚未建立 PR 的本機檢查

在乾淨且已提交的工作樹執行：

```bash
uv run --no-sync python -m tooling.git.gate full --base main
```

使用與 PR 相同的候選分流及範圍／期限選項，但結果僅涵蓋指定本機版本；遠端 PR
仍須執行 `check-pr.sh`。此入口與一律執行完整離線檢查的 `check-full.sh` 有不同用途。

## 注意事項

- **環境**：使用 repository 的 `.venv`；腳本依賴 Bash，未保證原生 Windows 相容。
  Git 需支援 `merge-tree --write-tree`。更新依賴須執行 `uv lock` 並提交設定及 lock。
- **Git 設定**：hooks 安裝器只調整本 repository；實際變更見安裝輸出與
  [安裝腳本](../scripts/install-git-hooks.sh)。重新安裝時移除客戶端仍引用舊版 Stop hooks 的註冊。
- **模型**：日常 pytest 不呼叫模型。Codex 測試及程式候選文件審查需要 CLI、登入、網路與額度；
  可用 `TRADINGDEV_CODEX_BIN` 指定 CLI。Local 服務須自行啟動，模型與上下文配置須個別驗證。
- **程序清理**：無法確認 worker 停止時，檢查失敗並保留臨時目錄；確認程序後才清理。
  外部強制終止不保證子程序停止。使用者成果不適用測試暫存清理規則。
- **PR 與 remote**：PR 工具僅支援 `github.com` 標準 HTTPS／SSH remote，預設 `origin`，
  可用 `--remote` 指定其他名稱；自訂主線使用 `git config tradingdev.primaryBranch 分支名稱`。
