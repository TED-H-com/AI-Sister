# THREAT_MODEL — 什麼會出錯，以及我們擋不擋得住

AI-Sister 每一拍做完後預設等 400ms 再看；沒有人動鍵盤滑鼠時可以不擷取，
但最多盲 5 秒。這種東西的威脅模型必須寫得比功能清單更誠實，因為它出錯的
方式**通常是安靜的**。

配套文件：[DATA_INVENTORY.md](DATA_INVENTORY.md)（存了什麼）、
[PRIVACY.md](PRIVACY.md)（承諾與邊界）。

---

## 資產

按「洩漏後有多難補救」排序：

1. **畫面檔與 OCR 文字** — 螢幕上有什麼，它們就有什麼。無法撤回。
2. **`facts` 表** — 電話、金額、帳號、錯誤碼。結構化 = 好搜尋 = 好濫用。
3. **剪貼簿內容** — 常是刻意複製的高價值字串。
4. **視窗標題與網址** — 看似 metadata，實則常含人名、案號、病歷號。
5. **輸入節奏** — 不含內容，但能推斷作息與情緒狀態。
6. **資料庫本身的存在** — 「這台機器上有一份七天的螢幕紀錄」這個事實。
7. **Azure Speech subscription key 與當次答案／音訊** — key 能代表使用者的 Azure
   resource；答案正文可能含姓名、電話與金額。key 長存 Windows Credential Manager，
   答案、SSML 與 MP3 只在 request／playback 的行程 RAM，不做 replay cache。
8. **Persona cache 與取得時間** — 素材本身公開，但 cache 的存在與本機時間可透露
   這台機器曾明確下載；它不該混進記憶 export 或 query。

---

## 攻擊者

| 誰 | 能力 | 我們的立場 |
|---|---|---|
| **拿到未鎖機器的人** | 讀檔案、跑 `sister query` | **部分防禦**：靠 OS 帳號隔離。目前資料庫**未加密** |
| **同機的惡意程式** | 以使用者身分讀任何檔案 | **不防禦**。同權限即同讀取權，這是 OS 邊界 |
| **偷走硬碟的人** | 離線讀取 | **依賴 BitLocker/LUKS**。應用層無額外加密 |
| **遠端攻擊者** | 網路 | **部分防禦**：本程式沒有監聽埠；`sister.exe`、recorder/core/capture/brain/hands 與 WebView 無任意 HTTP 能力。desktop 只有使用者揭露後按下的 Persona fixed-pack GET，以及設定啟用、獨立現行 consent、Credential Manager key 全成立後，只替最新新答案／trusted replay 走的 Azure TTS fixed POST；簽 cloud-reading 後另會把使用者問題與本機查詢命中的 OCR 原文／出處交給使用者設定的 CLI，後續網路與供應商邊界屬於那支 CLI；CLI 不取得 DB path 或畫面 |
| **供應鏈** | 汙染相依套件 | **部分**：`Cargo.lock` 鎖定；未做 vendoring 或 reproducible build |
| **好奇的旁人** | 看你的螢幕 | 不適用（他本來就看得到） |
| **被記錄的第三方** | 無 | **這是最重要的一項，見下方** |

### 第三方——被記錄卻沒有同意的人

同事在 Slack 上傳給你的私訊、視訊會議裡對方的畫面、你幫朋友查資料時
螢幕上的他的個資：**這些人從未同意被記錄，而且不知道自己被記錄了。**

這不是可以用技術完全解決的問題。目前的緩解：

- 會議 app 前景時自動暫停（Zoom / Teams / Meet / WebEx / TeamViewer 等）
- 任何 app 可一鍵加入 blocklist
- 畫面 pixels 永不離開本機；沒簽 cloud-reading 時問題與 OCR 文字都不交給外部 CLI。簽署後，
  問題與本機查詢命中的 OCR 原文／出處會交給使用者設定的 CLI，並受那支 CLI 與其供應商的邊界約束
- 選用 Azure TTS 時，當前答案正文可能也逐字含有第三方資料。第四張同意會明示不遮罩；
  不願把這段文字交給 Azure 時，維持預設關閉並使用本機朗讀

**明確不緩解**：Slack 與 Discord 不在暫停清單。它們平時是主要工作場所，
光憑 app 名稱分不出「正在分享畫面」與「正在聊天」；把它們列進去等於讓
整個工作日最重要的對話永遠不被記得。這是**刻意的取捨**，代價由使用者
與他的同事承擔，所以必須寫在這裡而不是埋在程式碼註解裡。

---

## Persona asset GET 新增的攻擊面

角色畫面本身不走 GET。alpha.110 從本機 5.2 GB 候選只選 17 套 workplace
rig（402 PNG、35,140,885 bytes），與 WebP 退路一起收進 desktop。sanitized
manifest 逐檔 pin bytes/hash/geometry/owner grant，CI 從實際出貨 bytes 重算；raw
receipt、私有 path、其他服裝、reaction 與 debug 圖不進 repo。renderer 只建立當前
角色的 21–26 層，並在全部圖層解碼成功前繼續顯示 WebP；任一檔失敗
不公開半隻 rig、不自動連線修復。同使用者可改安裝目錄的 malware 本來就在
威脅邊界外；尚無 code signing 時也不把 CI hash 寫成本機防竄改保證。

這條路不是「反正公開檔案就沒風險」。使用者按下載後，DNS 與 CDN 至少能觀察
hostname；CDN 會看見來源 IP、時間、TLS、固定 path／headers。程式先在按鈕旁列
`cdn.ted-h.com`、73,261,088 bytes 與這個邊界，而且請求不帶 persona、使用狀態或
任何記憶。17 位角色共用同一條 hash path，避免 URL 本身變成角色選擇的旁路訊號。

| 失效方式 | 防線 | 防不住／失敗時 |
|---|---|---|
| renderer 或別的 crate 把 fixed GET 擴成任意 URL | HTTP client 只在 `crates/sister-assets` 的非預設 `download` feature；只有 desktop 啟用；API 不收 renderer/config 傳來的 URL、header、body、persona 或 memory；WebView CSP 仍只准 IPC | desktop binary 的供應鏈若被攻破仍在同一信任邊界；因此相依圖與 source boundary 必須由 CI 守 |
| 隱藏的背景請求、retry、redirect 或 proxy | 開機／開設定／hover／切人都是 0 request；一次 trusted click 至多一個固定 HTTPS GET；redirect、proxy、retry、`HEAD` 與逐物件 request 全禁 | 網路失敗只停用額外 fixed voice；使用者要重新看揭露、重新按 |
| cookie、憑證、referrer 或私人狀態被帶出 | request 沒 cookie／credentials／authorization／referrer／query／body；method、URL、headers、body 對 17 位角色及所有狀態完全相同 | IP、時間、TLS、固定 host/path/headers 仍會被 CDN 看見，這是明示的 metadata，不假裝消失 |
| CDN、路上攻擊者或壞 cache 換掉 bytes | 正常 TLS；正式簽章 app 內的 compact authority pin exact origin/path、73,261,088-byte ZIP、946 entries、canonical manifest hash 與 pack SHA-256 | 攻擊者最多造成下載失敗／fallback；hash 不符的內容不解析、不啟用 |
| 惡意 ZIP traversal、symlink、duplicate、zip bomb 或 parser 差異 | response 大小/hash 先驗；之後只收 canonical safe path、regular file、exact entry count/set 與大小上限；同檔案系統 staging，全部成功才 atomic publish | 全新失敗不建立 cache，維持 `Available` 並回報當次錯誤；既有壞 cache 才是 `RepairNeeded`；兩者都不自動重抓 |
| 完整 manifest 太大而被「簡化」成無法查權利或聲音內容 | app 嵌 descriptor、exact allowlist、四位 selected public rights projection、八段選用聲音的核准逐字稿與完整 manifest canonical hash；**不宣稱嵌入約 2.1 MB 的完整 11 人 manifest** | pack digest 集體 pin 946 項；真正使用的 selected entries 再逐檔對 projection 驗 size/hash/rights binding；顯示文字不同於逐字稿即靜音 |
| 本機 cache 被換、被截斷或撤回只刪一半 | 每次啟用前按 embedded authority 重驗；撤回先停 fixed voice、保留 bundled 角色圖，再只刪 exact release | 同使用者權限 malware 本來就不在防護範圍；刪不掉必須顯示 `RepairNeeded`，不能報已撤乾淨 |

cache 固定在 `Config::default_data_dir()/persona-assets-v1`，雖然物理上與預設資料目錄
相鄰，邏輯上不是記憶：`--data-dir` 不搬它，memory export、forget、prune 不碰它。
跨行程 lock 與 durable random revocation tickets 放在 cache sibling；remove 先寫 ticket
再等 exclusive lock，讀者會在回傳 bytes 前後重查。另一個行程要等該 generation 的
blocking remove 寫下 settled checkpoint 後才能明確修復，而完整重裝最後才以集合 digest
重新授權目前 generation；settled 本身不授權任何 bytes。這防的是 crash／兩個
AI-Sister 行程的競爭，不防同權限程式手動竄改檔案。

---

## alpha.109／alpha.110 Azure TTS POST 新增的攻擊面

這條路會把使用者正在看的**當前答案正文原文**交給 Microsoft Azure Speech。正文
可能含姓名、電話與金額，不先遮罩；Azure 也會看見一般網路 metadata，例如來源 IP、
時間、TLS、所選區域 endpoint 與 request headers。它不送截圖、來源連結／出處 chip、
memory id、整份資料庫或其他文字。alpha.110 的現行第四張 `azure-tts` 同意書授權
設定開啟時，每份最新新答案完成後自動朗讀一次，另允許 trusted 手動重播；不授權
startup、status、demo、舊答案重畫、OCR 出境或把答案以外的 UI 拼進 payload。

| 失效方式 | 防線 | 防不住／失敗時 |
|---|---|---|
| 本機 voice 缺席或失敗後偷偷改走雲端 | Azure 預設關閉；本機與 Azure 不互相自動 fallback；啟用、typed region／voice、key 與現行第四張 consent 缺一即不 POST | 使用者選擇 Azure 就是在選擇把正文交給 provider；這不是「仍完全離線」 |
| status／重簽／重畫把同一題或舊答案補送，或競態送出較舊題 | 自動意圖只由 `ask()` 驗過仍是 latest 的答案完成建立，一題一次；startup／event／`renderHits()` 本身不能送。狀態 mutation 清掉 pending 題目；手動 replay 另要 trusted click | renderer 若被攻破仍在 desktop native trust boundary；native 因此仍逐次重讀 config、consent、credential 與 generation，而不信 renderer 自稱 ready |
| alpha.109 的 click-only 簽名被拿來授權 alpha.110 自動送 | 第四張有獨立 terms version；舊 timestamp 留作歷史但不能鑄出 permit，只重簽第四張才有效，前三張不被清掉 | 使用者重簽後是持久 opt-in，直到關閉設定或撤回；介面必須在控制旁明示這個後果 |
| renderer、設定或其他 crate 把 TTS client 擴成任意 URL | HTTP client 只在 `crates/sister-tts` 的非預設 `azure` feature；只有 desktop 啟用；region 只有 `eastasia`、`southeastasia`、`japaneast`，固定到 `https://<region>.tts.speech.microsoft.com/cognitiveservices/v1`；renderer 不傳 URL，WebView CSP 仍只准 IPC | desktop binary 或 dependency 供應鏈若被攻破，仍在同一 native trust boundary；所以相依圖、host/path 與 request shape 要由 CI 守 |
| 顯示層把來源、舊答案、問題、DB 或截圖一起送出 | native command 只把當前答案正文當 payload；renderer 帶回的 typed gate snapshot 只能用來和 native 重讀值逐格比對，不能指定 endpoint／key／permit；shared-lock Azure guard 守住唯一 helper，測試釘 payload 不含 source URL、app、memory id、DB 或其他 UI text | 正文本身可能逐字重複 OCR／記憶內容，也可能已包含個資；「只送正文」不是「正文已去敏」 |
| key 被長期寫進 TOML、log、DB、renderer storage 或 export | key 長期只存目前 Windows 使用者的 Credential Manager fixed target `ted-h/AI-Sister/AzureSpeech/v1`；輸入時短暫經過 password 欄位／renderer RAM／Tauri IPC，保存後清空；native 回條只帶 Present／Missing／Unreadable／Unsupported，不讀回 secret | 同一 Windows 使用者權限的惡意程式仍可能讀 Credential Manager 或行程記憶體；這個產品不防已被攻破的 OS 帳號 |
| Stop 文案讓人誤以為 request／費用已取消，或 mutation 回覆後舊 request 才送 | Stop／換題先使 renderer playback generation 失效；晚回的 MP3 不播放、不快取；最後 generation 檢查與 transport 和設定／key／consent mutation、native cancel 共用 fence | 已取得送出權的 transport 仍可能跑到 45 秒 timeout，provider 也可能已計入用量；相關 mutation／cancel 可能等待，但回覆成功後舊 request 不會才開始送 |
| 文字或合成音訊變成第二份長期記憶 | 不做磁碟或可供 replay 沿用的記憶體 cache；每份新答案／手動重播都可能新 POST；late response 丟棄 | request body、key 與 MP3 在處理期間仍存在 process RAM，可能受 OS paging、crash dump 或同權限除錯工具影響；Azure 端處理受使用者帳號、方案與 Microsoft 條款約束 |

Microsoft 目前公開列 Azure Speech F0 neural TTS 每月 0.5 million characters，但這不是
安全或費用上限，也不是 AI-Sister 提供的額度；可用性、費用與 provider 行為以使用者
Azure 帳號、resource、方案及 Microsoft 當下規則為準。

---

## Capture-time 邊界的競爭與殘餘風險

「排除在 capture-time」表示內容不能通過 recorder 的落地管線，不表示數個 Windows
API 呼叫能組成一個不可分割的快照。

| 失效方式 | 防線 | 防不住／失敗時 |
|---|---|---|
| 隱私檢查後才切換前景或鎖屏 | privacy context 鑄出綁 exact HWND／PID 的 permit；剪貼簿讀取後與 `BitBlt` 後都重驗 permit 和系統狀態，不一致的 bytes／frame 在 dedup、OCR、DB、PNG 前丟棄 | `BitBlt` 已開始時，raced pixels 可能短暫存在工作 RAM；這道防線保證不持久化，不宣稱 RAM 從未碰過 |
| 敏感視窗留在同一個螢幕背景 | app／URL／標題／敏感欄規則判斷前景，前置命中時不呼叫 capture | GDI 抓的是前景所在的整個 monitor；可見背景 pixels 仍可能入幀，必須靠暫停、最小化或畫面配置避免 |
| 瀏覽器複製後立刻切到另一個 app | clipboard sequence、owner、格式與 bytes 在同一個 clipboard lock 內取樣，不拿下一拍前景冒充來源；有 URL rules、來源是瀏覽器但沒有 origin URL proof 時直接丟棄 | clipboard event 目前沒有可靠的來源 URL／標題；保守丟棄會留下記憶空洞，URL／標題規則不能聲稱涵蓋 fast copy → switch |
| WTS 在兩次 poll 之間 lock 又 unlock | Windows 10+ 只有 `WTSActive` 且 unlocked 才放行；Unknown／矛盾／失敗停拍，並在慢 UIA、clipboard、screen 周圍重驗 | 目前是相鄰樣本 polling，不是 `WM_WTSSESSION_CHANGE` 訂閱；兩個樣本間發生又恢復的轉換可能沒有 audit row，不能宣稱捕捉每個原生事件 |
| source 已 consume 系統轉換，但 DB 寫入失敗 | 完整 observation 留在 recorder-owned pending；一個 transaction 全寫或全不寫，成功前不再 poll 或讀內容，watermark 也不前進 | pending 只在行程 RAM；transaction 前 crash 仍可能失去該 observation，所以是 process-lifetime retry，不是 crash-safe exactly-once |
| 另一個行程在 recorder 最後一次 pause probe 後、內容 commit 前按下暫停 | Desktop toggle 持有 `pause.lock` exclusive lock；recorder 每個慢來源後重取 snapshot，最後一份 shared guard 留到 PNG／DB transaction 結束。`pause.state` generation 也讓兩次 probe 中間完整發生的 pause→resume 留下 audit 空洞 | 同使用者權限程式直接竄改控制檔本來就不在防護範圍；尤其不能在任何 AI-Sister 行程仍執行時刪 `pause.lock`，那會讓不同 process 各鎖到不同檔案 |
| input hook callback 正在累加時進入 pause／lock | packed disabled-bit + in-flight count 先禁止新 callback、等在途 callback 歸零才清 counters 與時間／位置基線；resume 也在 disabled 狀態下推進並再清一次 | 這保證已收到的節奏不跨 gap 落地；OS 根本沒有交付的原生事件仍不可觀察，也不宣稱完整 event feed |

Windows 10 是 Release 1.0 最低支援版本；不把 Windows 7／Server 2008 R2 的反向
`SessionFlags` 語意猜成現行值。

---

## 最危險的失效模式：安靜地不生效

排除規則出錯有兩個方向，而它們**完全不對等**：

| 方向 | 後果 | 使用者會發現嗎 |
|---|---|---|
| 多擋了 | 該記的沒記到 | **會**。她去查，查不到，然後改規則 |
| 少擋了 | 敏感畫面被錄了 | **不會。永遠不會。** |

所以本專案的預設一律偏向多擋，而且**每一條規則都必須有測試證明它在真實
的識別碼形狀下會命中**。

> 這句話一直到 alpha.10 才真的有東西在執行它。在那之前，測試各自舉幾個
> 網址／app 當例子，加起來碰到的是網址 16 條裡的 8 條、會議 app **13 條
> 裡的 5 條**；而既有的規則 lint 只擋得住**語法上**就註定不命中的寫法
> （帶 scheme、帶 `www.`）。兩者都攔不住 `*frstbank.com.tw*` 這種——
> 語法正確、lint 無聲、沒有任何例子碰得到它，而 `doctor` 照樣把它算進
> 「16 條規則」裡。
>
> 現在四份預設清單（app／網址／標題／會議 app）都是一條規則配一個證人，
> 兩邊不准有多的：加規則不補證人會紅，刪規則忘了刪證人也會紅。證人寫成
> 各自真實的形狀（`gnome-keyring-daemon`、縮寫版網址），不是把規則抄一遍
> ——那種寫法測的是「字串等於自己」。

這不是理論。開發過程中實際發生過三次：

1. **網銀規則寫成結構對齊的 glob**（`*://*/*netbank*`），把關鍵字釘在路徑上。
   真實網銀把它放在網域裡，規則整條失效。修法：一律改成子字串。
   （commit `330dd2d`）

2. **app 排除用全字比對**。預設值寫 `keepassxc`，Windows 回報
   `keepassxc.exe`，於是十條密碼管理員規則有八條靜默失效。唯一生效的是
   剛好寫成 `1password.exe` 的那條。修法：無 `*` 的樣式視為子字串。
   （commit `5e1f7a6`）

3. **排除期間只是「不讀」剪貼簿**。密碼仍留在剪貼簿上，切回瀏覽器的下一個
   tick 照樣被撈進資料庫——排除只延後了洩漏。修法：排除時仍推進水位。
   （commit `3fdd085`）

前三次的共同點：**規則讀起來完全正確，但什麼都沒比對到。** 單元測試全綠，
因為測試餵的是規則作者想像中的輸入形狀。

同一個形狀後來又出現了兩次，只是換到「記不記得住」這一側——**看起來在運作，
實際上什麼都沒留下**：

4. **OCR 把中文逐字切開。** Windows 的 `OcrLine::Text()` 是用空白把「詞」接
   起來的。中文若被引擎逐字切成六個詞，存進資料庫的就是「本 期 應 繳 金 額」，
   於是搜「應繳」永遠是空的。畫面有錄、OCR 有跑、資料庫在長大、`stats` 一片
   綠——只有搜尋是空的，而使用者只會覺得「她就是沒記到」。
   修法：不採信引擎給的整行字串，改由每個詞的**幾何間距**決定要不要補空白
   （`crates/sister-capture/src/ocr_layout.rs`）。

5. **OCR 語言安靜地退回英文。** Windows 的 OCR 是逐語言安裝的。沒裝中文語言
   包時引擎不會報錯，它會挑一個裝了的（通常是英文），然後把滿螢幕的中文讀成
   空白。修法：`sister doctor` 印出**實際挑中的**語言而不是設定檔裡的偏好，
   並在它不是中文時明講後果。

第六次來自使用者的第一次真實測試，而且諷刺的是，**它是被前面幾次的修正
本身放過去的**：

6. **`doctor` 的 ✓ 只證明了引擎建得起來。** 使用者的機器上，`doctor` 印
   `✓ OCR 語言 zh-Hant-TW（實際使用）`、`✓ 已安裝的語言 en-US、zh-Hant-TW`，
   錄了一分鐘、保留 12 張畫面，資料庫裡**一個 OCR 字元都沒有**。所有勾都是
   真的：引擎建得起來、語言也真的是中文。只是「建得起來」和「讀得到字」
   是兩件事，而我們只驗了前者。而錯誤被吞掉了——`ocr_failures` 這個計數器
   我加了卻**從來沒有印出來過**，`tracing::warn!` 在 CLI 裡也沒有 subscriber。
   修法有三層，全部是「不宣稱、直接示範」：
   - `doctor` 讀一張**編進執行檔**的圖（答案已知），再讀**你現在這台螢幕**，
     兩個都印出實際讀到的行數與一行樣本
   - 錄製摘要印「讀到幾行字」，`kept > 0 && ocr_blocks == 0` 時直接示警
   - 每一次 OCR 失敗留下**訊息**而不只是計數，且 `recognize()` 每一步都掛
     context，所以錯誤會說出是哪一步

   附帶的第二則假警報：`doctor` 一直說「✗ 輸入 hook 沒裝上」，因為它根本不會
   去裝，而「沒去裝」和「裝了但失敗」被壓成了同一個布林。**一則恆真的警告
   會讓整個警告區塊被學會忽略，包括旁邊那則是真的。** 修法：狀態改三態，
   而且 `doctor` 現在會真的裝一次再報告。

第七次不是「安靜地不生效」，是**根本沒有生效過**，而且它藏在這份文件
自己的「減損設計」那一節裡：

7. **保留期從來沒有刪過任何東西。** `RetentionConfig` 有 `frames_days: 30`、
   `sister doctor` 印著「保留期　畫面 30 天」、上面那一節把它列為爆炸半徑
   控制——而在 `crates/sister-core/src/retention.rs` 出現之前，**整份程式碼
   裡沒有任何一行 DELETE**。設定讀得進來、印得出去，就是不會做事。
   它比前六個更難發現：排除規則失效至少還留下「敏感畫面被錄進去」這個
   搜得到的事實，保留期失效只是磁碟慢慢變大，沒有任何一刻會出事。
   同一個檔案裡還有兩個純裝飾的設定項（`thumbs_days`——沒有縮圖、
   `max_disk_gb_per_day`——沒有任何東西會降級），一併刪掉了：一個什麼都
   不做的旋鈕比沒有這個旋鈕更糟，因為使用者會調它、會相信它。

第八次的形狀跟前七次相反，而且是**自己找到的**：前面每一條都是規則
太窄、命中不了該命中的東西；這一條是規則**太寬**，而懲罰落在別的規則上。

8. **一條三個字母的字根，讓開始功能表變成了瀏覽器（alpha.102 以前的失效模式）。** 決定「要不要問 UIA」
   的清單裡有 `arc`（Arc 瀏覽器），而比對方式是子字串。於是
   `se·arc·happ.exe`、`se·arc·hhost.exe`——Windows 11 自己的搜尋與開始
   功能表——每次跳到前景都會被當成瀏覽器，被發一次 UIA 呼叫。
   而 UIA 的呼叫**沒有辦法取消**：對面卡住就燒掉一次 `MAX_ABANDONS`，
   連續三次就永久放棄讀網址，於是 `excluded_urls` 那十六條網銀規則
   一起失效。一個看起來只是浪費幾微秒的比對錯誤，出口在十六條規則的墳墓，
   而中間沒有任何一步會出錯或報警。
   當時的修法：比對改成**詞首**而不是任意子字串，並且清單裡每一條字根都要有一個
   真的執行檔名證明它會命中（`crates/sister-capture/src/browsers.rs`）。alpha.103
   再把安全後果改成整個 privacy context Unknown：UIA 失效後不再放行任何內容。
   順便把它從 `windows/` 搬出來——它全部是字串判斷，沒有理由讓它只能在
   CI 上被測到。

第九次的位置最尷尬：出事的不是規則，是**守規則的那支腳本**。

9. **看門狗只看著一半的房子。** 在 Persona transport 出現前，
   `scripts/check-no-network.sh` 是當時「程式裡沒有任何對外連線的程式碼路徑」承諾
   唯一的自動保證，而它掃相依樹
   用的是 `cargo tree --workspace`。出貨的是**兩個**執行檔，而 Tauri 要自己一份
   `Cargo.lock`：`sister-desktop.exe` 在另一個 workspace 裡，於是字母人那半邊
   ——外殼、視窗、所有 plugin——**從來沒有被那支腳本看過**。同一支腳本裡搜
   socket 的那一行也只給了 `crates/`，`apps/` 不在裡面。
   發現的時機很普通：往桌面那半邊加一個全域熱鍵 plugin，腳本照樣印綠勾。
   它比前八條都安靜，因為前八條至少會在資料裡留下痕跡（沒擋到的畫面、查不到
   的中文、變大的磁碟）；這一條在真的被觸發之前**不留任何痕跡**，而它被觸發的
   那一天，PRIVACY.md 當時的第一句話就已經是假的了。
   修法：兩個 manifest 各掃一次（host + Windows target 各一輪，錯誤訊息指名是
   哪一個執行檔），socket 那一行加上 `apps/`。順便修掉旁邊一個同型的問題——
   那行 grep 原本吃掉**所有**非零退出碼，包括「目錄不存在」，所以目錄改個名字
   它就從此永遠是綠的；現在 1（沒找到）和 2 以上（grep 自己出事）分開處理。

對應的工程紀律：

- **一支檢查腳本的覆蓋範圍，本身就是一個會過期的假設。** 第 9 條的 `--workspace`
  在寫下去的那一天是對的——那時候只有一個 workspace。真正的問題不是誰寫錯了，
  是「它掃了哪些東西」從來沒有被寫在輸出裡：它只印 `▶ 檢查出貨相依樹（host）`，
  不印它掃的是哪一份 manifest。**看不出範圍的綠勾，和沒有那個勾一樣。**
  現在每一輪都印出是哪一個執行檔
- **有預算的 fail closed 必須把可用性代價說出來。** alpha.102 以前，多抓到
  非瀏覽器會燒掉 UIA 重試額度，最後讓網址規則安靜失效；現在敏感欄要問每個
  前景 app，所以重試耗盡時整個 privacy context 會 Unknown、內容停止記錄。
  安全方向不再反轉，但這段記憶空洞必須由能力報告說明
- 端到端測試把整個資料目錄**當成位元組**掃過，不依賴任何人記得檢查哪個欄位
  （`cargo test -p sister-capture --test privacy`）
- 每個修好的缺口都留一個回歸測試，且該測試經過**變異驗證**（拿掉修正就要變紅）
- 能力缺席時 `sister doctor` 報「**目前失效的隱私保護**」與「**看起來正常，
  但其實記不住東西**」，不報「N 條規則 ✓」
- 承諾能被機器檢查的就交給機器：`scripts/check-no-network.sh` 在 CI 上逐棵檢查
  root workspace 預設無 Persona download 或 Azure transport、recorder／core／capture／
  brain／hands 無 HTTP client，且只有三條核准的 reverse dependency path：
  `client → sister-assets[download] → sister-desktop`、
  `client → sister-tts[azure] → sister-desktop` 與
  `client → sister-usage[public-status] → sister-desktop`；renderer/CSP 仍無遠端出口。
  這讓 PRIVACY.md 的能力邊界由建置保證而不是由記性保證。缺口通常不是人手動
  打開的，是相依套件或 feature 默默帶進來的
- 平台相關的假設要在**那個平台上**驗，不能只靠推理：OCR 有一個 CI 步驟真的
  在 Windows 上辨識一張中文圖（`tests/windows_ocr.rs`）
- **測試要用真實的尺寸。** 第 6 條之所以躲過 CI，一部分是因為測試圖是
  900×300，而真正送進 OCR 的是整張畫面。`a_full_screen_sized_frame_still_yields_text`
  現在把同一張圖貼到 **2560×1440** 的畫布上再測一次——內容不變，只變尺寸。
  這個數字後來又改過一次：它原本是 1568×882（存檔用的縮圖尺寸），而那
  正好是出事的那一版——**拿縮過的尺寸去測，等於測了一條 production 已經
  不再走的路**
- **狀態報告一律「示範」而非「宣稱」。** `doctor` 的每一個 ✓ 都必須是某件事
  真的做成了，不能是某個物件建得起來。它現在會真的讀一張圖、真的讀一次
  你的螢幕、真的裝一次 hook
- **「不知道就擋住」沒有安全旁路，但必須可見。** 敏感欄偵測問不出答案時
  當拍 fail closed；連續 [`MAX_UNKNOWN_STREAK`] 次後能力報告宣告「這台機器上
  做不到」，recorder 仍繼續擋。門檻只改變可觀測性，不把 Unknown 翻成 Clear
- **排除一定要說得出是誰擋的。** 錄製摘要現在把「排除 80」拆成每條理由各
  幾次。沒有這一行的話，一條寬到吃掉一整天的規則，症狀只是一個沒有解釋
  的數字
- **設定項要嘛實作，要嘛刪掉。** 一個讀得進來、印得出去、但不會做事的
  旋鈕，是這份文件裡最有效的謊——使用者會調它、會據以放心，而它從來
  沒有存在過（第 7 條）。

  這一條後來被改成一句可以機器化的檢查：**每個欄位都去 grep 一次有沒有
  人讀它**。一次掃過 17 個設定項，抓到兩個沒有任何讀者的：

  - `heartbeat_secs` — 描述的是「事件驅動 + 保底心跳」，而 Phase 0 根本
    是輪詢的，輪詢本身就是心跳。**刪掉**；等 Phase 1 真的變成事件驅動
    再連同實作一起加回來。
  - `input_window_secs` — 這個更糟，因為它旁邊還有一份**寫錯的文件**。
    設定寫著 10 秒、DATA_INVENTORY 寫著「預設每 10 秒一列」，而 recorder
    每 400ms 叫一次 `drain()`，它就每 400ms 寫一列——打字時是一秒 2.5 列。
    **實作它**（聚合視窗真的存在了），順手讓那句文件變成真的。

  值得注意的是這兩個都不是「猜」出來的，是把「有沒有人讀它」這個問題
  對每一個欄位各問一次問出來的。**會漏掉的永遠是沒有被問到的那一個。**
- **報告要拿整包去比，不要一欄一欄挑。** `prune` 的預告與實際本來只比了
  四欄，於是漏掉的兩欄各藏著一個錯的數字（CASCADE 先把事實帶走 → 事實
  數是假的零；第一段的檔案大小沒加進去 → 檔案數和大小來自不同的兩段）。
  改成 `assert_eq!(preview, actual)` 之後兩個當場現形。**挑著比的測試
  看不到自己沒挑的東西**
- **一個沒辦法歸因的數字，會讓人去修最好修的地方，而不是最貴的地方。**
  實測回報「CPU 平均 27.1%」（預算 3%）之後，我猜了兩次原因，兩次都猜
  PNG 編碼太慢，兩次都錯——實測 PNG 編一張 1568×882 只要 1.7ms，佔不到
  千分之一。所以現在錄製摘要會把時間拆到每個階段
  （`crates/sister-capture/src/timings.rs`），磁碟也拆成「畫面」與「其他」
  ——**猜三次的成本，遠高於一開始就讓她自己講**
- **算式是對的不代表結論是對的。** 第三個猜測是「每個 tick 搬一張全尺寸
  的圖只為了算一個 64-bit 雜湊」，修法是先抓一張 256px 的探測圖，算式很
  漂亮：要搬的位元組從 14MB 掉到 147KB。裝上計時之後量到的是**探測
  27.0 ms、它想省的那次抓圖 30.1 ms**——省 10%，而且每個 tick 都先付。
  等於沒省。換縮放演算法也一樣（面積平均 30.3、丟像素 31.3）：錢不在
  縮放的算術上，在「跟顯示驅動要一次畫面」這件事本身，而那筆錢跟目的地
  多小關係不大。真正有用的是**連問都不要問**——沒有人碰過鍵盤滑鼠就完全
  不看螢幕（`GetLastInputInfo`，一次系統呼叫）。同一台機器：每 tick
  40 ms → 14 ms。**一個算得出來的節省，和一個量得到的節省，是兩件事**
- **讓每個最佳化自己結一次帳。** 上一條的探測圖活了兩個版本，因為在時間
  表上它只是「排第一名的那一項」——而排第一很正常。後來加了一行：省下的
  ＝沒抓成的次數 × 抓一次多少，成本＝探測全部，倒賠就印 ⚠。它第一次跑就
  印了 `⚠ 探測圖倒賠：花了 0.05 秒去省 0.02 秒`，然後那個階段就被刪掉了。
  **一個為了省錢而存在、結果自己變成最大開銷的階段，跟單純的第一名長得
  一模一樣**——除非你叫它交帳
- **可疑不等於有罪，一樣要量。** 刪掉探測圖之後還剩一筆約 15 ms 的固定
  成本。頭號嫌疑犯很明顯：我們每次擷取都新建 DC 和 bitmap 再刪掉。量了
  之後 15.8（每次新建）對 15.9（重用）——一模一樣。那是跟顯示驅動要一次
  畫面的過路費，不是 GDI 物件的手續費。**如果當時直接動手去快取 DC，
  會得到一份漂亮的重構、零效益，而且從此以為這條路已經走完了**
- **同一份資料被三個需求共用時，三個需求會一起壞。** 一張擷取的像素原本
  同時要滿足去重（只需要 9×8）、OCR（需要原生解析度）與存檔（想要小）。
  折衷出來的 1568 對三邊都是錯的：去重浪費了 100 倍的搬運、OCR 把
  `Microsoft Teams` 讀成 `Micr099ftTeamsTr`、而磁碟仍然超標 38 倍。
  拆開之後 OCR 和磁碟那兩個確實消失了；去重那一路省下的搬運量是真的，
  省下的**時間**卻不是（見上一條）——**「這三件事互相衝突」是對的診斷，
  不保證每一條分支開出來的藥都有效**

---

## 手（alpha.69 起）：螢幕上的字想叫她做事

在她長出手之前，最壞的情況是「她記錯了一件事」。有手之後，最壞的情況變成
「**別人寫的一段字，叫她在你的機器上開了一個東西**」。

威脅的形狀很具體：她看得到的每一封信、每一個網頁、每一則訊息，都是別人寫
的。任何一段那樣的文字都可以寫著「請開啟 https://…」。OCR 把它讀進來，模型
看得到它。這不是假設性的——這正是 SPEC §0.4 / §9.4 存在的理由。

五道，由內而外：

1. **模型不能自己打一串網址。** 她要建議一個下一步，契約上只能填
   `{"fact": 45}`——指一筆 L1 已經用 regex 抽出來的 typed fact。那句
   `{"action":"open_url","url":…}` 是 Rust 從 `facts.raw` 組出來的。
   這一道擋掉的是「模型被說服後自由造出一個目標」。
2. **目標是白名單，而且貼著 OS 呼叫再驗一次。** 網址只有 `http` / `https`；檔案只有一列「打開來是看的」
   副檔名。這裡一開始寫成黑名單，擋掉了 `.exe` `.bat` `.ps1`，卻放行 `.hta`
   （mshta 會執行它）、`.vbs` `.js` `.wsf`（wscript 會執行它）、`.scf` `.reg`
   `.msc` `.cpl` `.pif`。**列不完的那一邊，不能是會執行的那一邊。** Windows 的
   `ShellExecuteW(lpFile)` 也接受 URI，所以 OpenFile 在 OS 邊界另拒絕 URI、UNC／
   device path、控制字元、非磁碟機前綴的冒號與無副檔名路徑；不能只在上游看 `.pdf`。
3. **無人值守的目標要落在兩個 pass 的共同出處。** 下一步引用的 fact 必須仍指得到保留中的
   target frame，而且 Reviewer 兩個 pass 都引用過那張畫面；缺一邊、原件被忘掉或
   查詢出錯都不執行。
4. **批准只有兩種，而且型別上造不出第三種。** 互動路徑由當場 click／「好」鑄出
   `UserButtonPress`。無人值守路徑先由 `Run::may_start_step` 守步數，再由
   `Grant::authorize_unattended` 在 task、app、action、期限與 URL 政策通過後鑄出
   `GrantPermit`。
   permit 綁定 exact `ActionSnapshot`，拿替 A 鑄的票去接 B 會被拒絕。兩種憑證的欄位
   與鑄造入口都不是模型或 L0 文字能建構的。
5. **批准之後不採信畫面送回來的東西。** 回叫帶的是承諾 id，要做什麼由後端
   重新讀一次資料庫。

**螢幕內容本身在這五道裡從來不是批准。** 互動路徑最後由人承重，所以按鈕一定
印出完整、不截斷的目標；無人值守路徑最後由先前保存的結構化 grant、雙 pass
target provenance、exact-action permit 與 URL 政策一起承重。URL 政策的
「說得出來源」只比對保留中的真 Windows 錄製是否看過同一 host（容許一層 `www.`
差異）；alpha.103 起只有 exact
`sessions.platform = windows/windows-gdi-uia-focused-url-v2` 的列能背書。歷史
`windows/windows-gdi-uia-focused-url-v1` 仍可讀、仍可顯示，但因當時的全域 focused
element 與 stale URL cache 無法證明 exact HWND／當拍 live value，已撤銷來源授權；
更舊錄製、import 與 replay 也不能背書。v2 仍不證明網站安全、使用者意圖、path、
redirect 或站內內容。被埋在已授權 app、已見過 host 裡的 URL 仍可能通過，所以
這些防線不等於 Phase 6 的 prompt-injection 退場條件已完成。

---

## 目前明確不防禦的

誠實列出，不用「未來會做」帶過：

1. **資料庫未加密。** 依賴 OS 磁碟加密。應用層加密會帶來金鑰管理問題，
   而錯誤的金鑰管理比沒有加密更糟。
2. **同權限惡意程式。** 任何以你身分執行的程式都讀得到。這是 OS 的邊界。
   它也能在 AI-Sister 行程存活時 rename／替換 data-dir 路徑或改指 ancestor；master-stop
   的檔案鎖不宣稱 pin 住 pathname namespace。移動或修復資料目錄前須先關閉所有
   AI-Sister 行程。
3. **記憶體中的內容。** 未鎖頁、未防 swap。
4. **側通道。** 磁碟用量、檔案時間戳會洩漏活動節奏。
5. **停用不等於刪除。** 暫停只是不再新增；既有資料仍在，要另外刪。
6. **網址只讀得到位址列上那串字**，而且只在瀏覽器裡。Chromium 交出來的是
   縮寫版（沒有 scheme、沒有 `www.`），所以按結構寫的規則會整條失效——
   這正是「安靜地不生效」第 1 條的形狀，只是換了個來源。
7. **顯示密碼仍可能繞過控制項屬性。** 敏感欄屬性現在會對每個前景 app 查；
   查不到、UIA 失效或前景未知都 fail closed。但使用者按下「顯示密碼」後，
   控制項若不再回報密碼屬性，內容仍可能被記下；app／標題規則是第二道防線。
8. **沒有人動的時候，她最多會有 5 秒沒在看。** 這道閘門原本為了降低 CPU，
   從上次看螢幕到現在沒有任何鍵盤滑鼠輸入的話，那個 tick 完全不碰螢幕
   （`GetLastInputInfo`）。這是一個**猜測**：沒有人動 ⇒ 畫面沒變。它對
   絕大多數情況成立，但影片、進度條、跑動的 log、別人傳進來的訊息全都
   不需要你動任何東西。所以有上限——`MAX_BLIND_MS = 5 秒`，超過就一定
   睜眼。代價實話說：**一段五秒內出現又消失的畫面，可能整段沒被記到**。
   錄製摘要會印出這一段時間佔了多少（`省下：N 次沒碰螢幕`），因為
   「省電」和「停止工作」在其他每一個數字上長得一模一樣。
9. **OCR 交給作業系統。** Windows 上用的是系統內建的 `Windows.Media.Ocr`，
   畫面像素會交給作業系統的元件處理。它是本機的、離線的，但它不是我們寫的，
   也不在我們的稽核範圍內。選它的理由見
   `crates/sister-capture/src/windows/ocr.rs` 的模組註解——最主要的一條是：
   原本要用的 ONNX 方案會把一個 HTTP client 連進 recorder 執行檔裡；desktop 的
   Persona fixed-pack GET 與 Azure TTS fixed POST 都不是 OCR 可以重用的例外。
10. **白名單管得住「哪個程式會被叫起來」，管不住那個程式。** `.pdf` 交給
    PDF 閱讀器、`.docx` 交給 Word、`.svg` 多半交給瀏覽器——而
    **`.svg` 裡可以放 `<script>`**，用瀏覽器開就會在 `file://` 的來源上跑；
    `.doc`（不是 `.docx`）帶得動巨集。這一列的標準是「打開來是看的」，不是
    「打開來絕對不會執行任何東西」。後面那句話，只要清單上還有任何一種現代
    文件格式，就沒有人講得出來。
11. **OpenFile 沒有證明目標真的是一般檔案。** 單靠一串 path 分不出無副檔名
    可執行檔與資料夾，所以無副檔名路徑現在一律拒絕，常見資料夾也因此不能開。
    目前只驗字串與副檔名白名單，不查檔案系統 metadata；名稱碰巧以允許副檔名結尾的
    資料夾仍可能被交給 Windows。要正式支援開資料夾，必須在 OS 邊界另證明它真是目錄。
12. **網址長得像不像，只在互動路徑交給人看。** `https://evil.example` 和
    `https://ev1l.example`、以及各種同形異義字（IDN homograph），對
    `validate_url` 來說完全一樣，兩個都是合法的 https 網址。互動時分辨它們的是
    按鈕上那串字和讀它的人，所以樣式刻意不截斷、可換行。無人值守的來源政策會做
    exact-host 比對（另容許一層 `www.`），但 IDN homograph 仍然成立，而且「以前
    看過這個 host」不等於它安全。
13. **視窗標題比對可能挑錯視窗。** `EnumWindows` + 子字串，比到第一個就停。
    兩個視窗標題長得像的時候她會挑錯一個。空標題擋掉了（那會比中畫面上第一
    個有標題的視窗），但「像」擋不掉——那要改成收集全部再讓人選。
14. **執行失敗的嘗試不消耗步數上限（alpha.70 起）。** `sister do` 的
    `--steps` 數的是**做成**幾步——`RunConclusion::StepLimitReached` 那個欄位
    自己就叫 `completed_steps`。所以一連串「交出去但失敗」的嘗試可以在同一張
    授權書底下反覆發生，不會把步數預算用完。互動路徑每一次仍要他親手說「好」；
    無人值守路徑不需要，能限制它的是 grant 的 task/app/action scope 與期限、hands
    kill switch，以及行程停止，不是 completed-step 數。之所以不順手改成「每次嘗試都算一步」：那會讓
    「已做 3 步」這句話變成一句沒有人答得出來的話——3 步裡有幾步真的發生了？
15. **`--app` 那一維約束的是證據，不是作業系統。** 它說的是「這一步要開的那串字，
    是在哪個 app 的畫面上被看到的」——由 `evidence_json` → frame →
    `text_chunks.app_id` 算出來。它**不是**「作業系統只會讓這些 app 被打開」：
    一個 `https://…` 交給 `ShellExecuteW` 之後由誰接手，是 Windows 的檔案關聯
    決定的，不是我們。

    > `sister_hands::semi_action::AllowedApps` 的型別註解一度和這一段互相矛盾：
    > 那個 crate 看不到呼叫端，所以它 alpha.69 寫的是「這是規劃者自己填的字，
    > 今天沒有一條誠實的路可以推回哪個 app」——而 alpha.70 的 `sister do`
    > 就是那條路，只是它住在另一個 crate 裡。兩邊現在對齊了；改動任何一邊的
    > 時候要一起改，這種跨 crate 的「它其實是誰填的」沒有任何閘門守得住。

---

## 減損設計（假設洩漏已經發生）

- **本機優先**不只是隱私姿態，也是爆炸半徑控制：沒有伺服器可以被拖庫。
- **一個檔案**：刪除是一個確定的動作，不是散落各處的清理。
- **保留期預設有限**：畫面 30 天、文字與事實 365 天。過了 30 天刪掉的是
  **PNG 檔本身**，frame 那一列與它上面的字留著——截圖是最敏感的東西，
  而「三個月前那通客服電話」的價值幾乎全在文字上，兩者不該綁在一起刪。
  過了 365 天整列連同文字、事實與 FTS 索引一起消失。
  錄製開始時自動跑一次（不是收工時：收工有太多種方式不會發生），
  也可以隨時 `sister prune`，或 `sister prune --dry-run` 先看會刪掉什麼。
- **L0 不可變、可追溯**：每一句話都能追回它的來源畫面，所以「她為什麼知道
  這件事」永遠答得出來——這同時是可稽核性，也是出錯時的鑑識能力。

---

## 回報問題

發現隱私缺口請開 issue：<https://github.com/teddashh/AI-Sister/issues>

**特別歡迎「這條規則在我的機器上沒生效」這類回報**——那正是上面三個
bug 的形狀，而且是最難靠讀程式碼發現的。
