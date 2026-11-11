# Multibagger Scout — A–F 最新研究證據補強包

（整理日：2026-11-11；所有數據均附來源，已核對原文）

本文件依「A–Z SOP」摘要規範的 A–F 六項，為「台股潛力股探勘 AI Agent（Multibagger Scout）」提案補充最新研究報告數據與案例新聞，並標注各證據對應 Interesting（有趣）、Innovation（創新）、Important（重要）三個賣點的運用建議。

## A. Attention Getter（動機與引題）

### A1. 全球百年實證：財富極端集中，且正持續加劇

Bessembinder 最新論文《One Hundred Years in the U.S. Stock Markets》（SSRN，2026 年 3 月發布、9 月修訂）涵蓋 1926–2025 共 100 年、29,754 檔美股：

  - 100 年間美股共創造約 91 兆美元淨股東財富，但**僅 46 家公司就貢獻其中一半**；相較 2018 年版研究（89 家創造 43 兆美元的一半），集中度幾乎翻倍惡化。

  - 將近 60% 的股票長期使股東財富縮水；中位數買入持有報酬為 **−6.9%**；只有 41.17% 的股票報酬優於一個月期國庫券。

  - 追蹤報導指出：Apple 與 Nvidia 兩檔就占全部淨財富創造的 10%；2017–2025 九年間前五大公司（Apple、Nvidia、Microsoft、Alphabet、Amazon）貢獻 21.4% 的淨財富，為前 90 年（約 10%）的兩倍有餘。

  - 來源：[SSRN 論文頁](https://papers.ssrn.com/sol3/papers.cfm?abstract_id=6438198)、[AJ Bell 分析](https://www.ajbell.co.uk/news/100-years-stock-market-history-shows-why-picking-winners-very-difficult)、[MarketWatch/Morningstar 報導](http://www.morningstar.com/news/marketwatch/20260414132/this-study-will-tell-you-everything-you-need-to-know-about-how-to-be-a-successful-investor)

> **專題運用**：這比原提案引用的 Bessembinder et al. (2023)「全球 6.4 萬檔、2.4% 創造全部淨財富」更新、更聳動（「百年、91 兆美元、46 家公司」），且明確顯示集中度「正在加速」——Interesting + Important。建議簡報動機頁改引 2026 版並對照 2018 版，形成「越來越集中」的趨勢敘事。

### A2. 台股市場參與度：開戶數續創新高且年輕化

  - 證交所統計至 2026 年 10 月底，台股累積開戶數 **1,482 萬 7,469 人**，續創歷史新高，單月增加 6.4 萬人（[中央社](https://www.cna.com.tw/news/afe/202611020015.aspx)）。

  - 10 月新增開戶中 30 歲以下占 **56.3%**（20–30 歲新增 19,694 人最多、19 歲以下新增 16,472 人次之），年輕化趨勢明確。

  - 對照組數據：提案引用的「2025 年約 1,377 萬人」可更新為「2026 年 10 月底 1,482 萬人」。

### A3. 台股本身的「報酬集中」現況（案例）

  - 台積電一檔即占台股總市值**超過 40%**（[Focus Taiwan](https://focustaiwan.tw/business/202611060006)）。

  - 2025 年台股全年大漲 5,928.5 點（+25.7%）、市值突破 94 兆元，史上最大年度漲點；但漲幅高度集中於 AI 供應鏈：2025 年飆股前 20 幾乎全為 PCB 與記憶體族群（德宏 +686%、南亞科 +560%、尖點 +483%），而以中小型股為主的上櫃指數全年僅漲 7.97%，遠低於集中市場（[中央社](https://news.pchome.com.tw/finance/cna/20251231/index-17671852682807418003.html)、[鉅亨網](https://news.cnyes.com/news/id/6294889)）。

  - 2026 年更極端：台新投信統計今年漲幅超越大盤的電子股中約 **9 成股本在 80 億元以下**，中小電子股平均報酬率達 **171%**（[天下雜誌](https://www.cw.com.tw/article/5143275)）。

> **專題運用**：A3 直接將「報酬集中」從美股研究連結到台股現場，讓 Precision@50 的評估設計有本地實證——Important。（⚠️ **對齊 `DESIGN.md` v0.6 注意事項**：此處上櫃指數與中小型電子股數據僅作 `§1 Problem` 市場背景引題；系統正式研究母體嚴格限定為「證交所上市普通股」，不含上櫃與興櫃。）

## B. But（挑戰與痛點）

### B1. 事前辨識之難：連專業經理人都做不到

  - S\&P Global SPIVA 年末 2025 記分卡：**79% 的主動式美股大型股基金 2025 年表現落後 S\&P 500**，較 2024 年的 65% 更差，是 25 年 SPIVA 歷史中第四差的一年（[S\&P Global](https://www.spglobal.com/spdji/en/spiva/article/us-persistence-scorecard/)）。

  - Persistence Scorecard：2023–2025 年僅 29% 的前四分之一大型股基金能連續兩年維持前四分之一；2021–2025 五年間**沒有任何**主動式大型股基金維持前四分之一（除小型股外）；持續優於中位數者僅 4.5%，甚至低於純隨機的 6.25%（[S\&P Global Persistence Scorecard](https://www.spglobal.com/spdji/en/spiva/article/us-persistence-scorecard/)）。

  - 加拿大 SPIVA 2025：加拿大股票基金 1 年落後率 93.4%，10 年落後率 98.8%（[S\&P Global PDF](https://www.spglobal.com/spdji/en/documents/spiva/spiva-canada-year-end-2025.pdf)）。

> **專題運用**：專業人士尚且如此，「事前辨識長期贏家」是結構性難題，支撐 B 點「事後贏家特徵 ≠ 事前選股能力」——Important。同時可誠實框架：本專題目標不是打敗專業經理人，而是提供可核對的排序與解釋。

### B2. 資料與時間陷阱：存活偏差與前視偏差的量化

  - 存活偏差規模實測：美國股票 1980–2020 年間，倖存者資料庫平均每年高估報酬約 1–3 個百分點；30 年回測累計虛增 30–100%（[ARIA Analyst](https://ariaanalyst.pro/blog/survivorship-bias-backtests)）。

  - 一項動能策略實測：只用今日還存在的股票清單回測，績效直接**翻倍**（[dev.to 實測](https://dev.to/finzdata/survivorship-bias-doubled-our-momentum-backtest-here-are-the-numbers-3le7)）。

  - 前視偏差已進入 LLM 時代：經濟學文獻《AI's predictable memory in financial analysis》（Economics Letters, 2025）實證 LLM 因訓練資料包含「未來資訊」而系統性高估可預測性（[RePEc](https://econpapers.repec.org/article/eeeecolet/v_3a256_3ay_3a2025_3ai_3ac_3as0165176525004392.htm)）；ABFER 2026 年會論文《A Test of Lookahead Bias in LLM Forecasts》（Gao, Jiang, Yan）發展了偵測 LLM 預測中前視偏差的統計檢定（[ABFER 論文 PDF](https://abfer.org/media/abfer-events-2026/annual-conference/papers-tech-ai/AC26P10024_A-Test-of-Lookahead-Bias-in-LLM-Forecasts.pdf)）；最新綜述《Evaluating LLMs in Finance Requires Explicit Bias Consideration》系統整理金融 LLM 五大偏誤：look-ahead、survivorship、narrative、objective、cost bias（[arXiv 2602.14233](https://arxiv.org/html/2602.14233)）。

  - 開放原始碼工具 pitbacktest 的實測更聳動：用 yfinance 免費資料，41 檔知名下市/被購併美股中 **0 檔**能取得正確歷史（[pitbacktest](https://pypi.org/project/pitbacktest/0.3.0/)）——免費資料的存活偏差問題是實作層面的真痛點。

> **專題運用**：B 點可升級為「三重陷阱」：(1) 倖存者資料（免費資料尤其嚴重）→ 支撐含下市股的設計；(2) 特徵時間點 → 支撐 4 月底特徵日；(3) LLM 訓練洩漏 → 支撐「不用 LLM 產生數字」的分工設計。這讓原提案的 \[8\]\[9\] 文獻有 2025–2026 的最新接棒——Innovation。

### B3. LLM 數值能力不可靠：最新基準證據

  - FAITH 框架（arXiv 2508.05201）以 S\&P 500 年報（453 家公司、2,406 個可回答數值）實測：模型在「直接查表」尚可（Claude Sonnet 4 達 97%），但需要多變數計算時，頂尖模型也有 10–20% 失誤率；多數中小型模型在多變數計算情境準確率**趨近 0%**（[arXiv](https://ar5iv.labs.arxiv.org/html/2508.05201)）。

  - PHANTOM（NeurIPS 2025）與 Financial Touchstone 等金融長文幻覺基準亦顯示：現成模型在金融長文 QA 的幻覺偵測上仍嚴重不足（[NeurIPS](https://papers.nips.cc/paper_files/paper/2025/hash/b8badadce3f482ba340ff870f4894441-Abstract-Datasets_and_Benchmarks_Track.html)、[arXiv 2608.08634](https://arxiv.org/html/2608.08634v1)）。

> **專題運用**：直接支撐「LLM 只做工具調用與文字組織、數字交給程式」的設計，讓 FAITH 的查表 vs 計算落差成為 PoT 分工的動機證據——Important + Innovation。

## C. Cure（提出的解法）

### C1. LLM 已被證實具有選股資訊價值（但需正確分工）

  - Lopez-Lira & Tang《Can ChatGPT forecast stock price movements?》已正式刊於 **Journal of Financial Economics（2026, vol. 184）**：GPT-4 對頭條新聞的分析能預測次日報酬方向（非可交易的初始反應投組命中率約 90%），且對小型股與負面新聞的預測漂移最強；但隨 LLM 被廣泛採用，策略報酬遞減（價格效率提升）（[RePEc/JFE](https://econpapers.repec.org/article/eeejfinec/v_3a184_3ay_3a2026_3ai_3ac_3as0304405x26001066.htm)）。

  - 實務界採用：Point72 的 AI 基金 Turion 2025 年報酬約 30%；Bridgewater 推出 20 億美元 ML 基金（採用 OpenAI、Anthropic、Perplexity 模型）；雪梨 Minotaur Capital 完全以系統 Taurient 取代人類分析師（每日處理近 5,000 則新聞），首半年報酬 13.7% vs MSCI ACWI 6.7%（[newclawtimes 彙整](https://newclawtimes.com/articles/agentic-ai-hedge-funds-point72-bridgewater-minotaur-portfolio-management/)，原始來源 Reuters/Bloomberg/Hedgeweek）。

  - 專業投資人態度：RBC/EY 類調查顯示九成受訪投資人預期生成式 AI 將提升避險基金績效（[hedgeco 轉述](https://hedgeco.net/news/10/2025/ai-and-quant-domination-the-new-frontier-in-hedge-funds.html)）。

> **專題運用**：C 點可主張「LLM 的資訊價值已被頂級期刊與市場驗證，缺口在於可核對的長期研究流程」——Innovation + Important。

### C2. 誠實的對照面：AI 直接交易仍多數虧錢（避免過度承諾）

  - Nof1 Alpha Arena 實測（各模型 1 萬美元真實帳戶）：Season 1（2025/10–11，加密永續）6 個模型僅 2 個獲利，Qwen3 Max +20.3% 奪冠；Season 1.5（2025/11/19–12/3，美股+加密）32 個帳戶僅 5 個獲利；合計 **38 個 AI 帳戶中 31 個虧錢**（[Trading Agent Stack 彙整](https://tradingagentstack.com/alpha-arena-results/)、[AP 報導](https://www.mercedsunstar.com/news/business/article315656864.html)）。

  - 報導引述 Nof1 創辦人：「LLM 自己賺不了錢，需要非常精密的 harness、鷹架與資料平台才有機會」——正好是 Multibagger Scout「工具分工 + 資料嚴謹」設計的註腳。

  - 對照組：多數 LLM 交易實驗顯示模型**過度交易**（同一提示下 Grok 158 筆 vs Qwen 1,418 筆）且決策不穩定。

> **專題運用**：這組新聞讓 Cure 的敘事更誠實有力——「直接叫 LLM 交易會虧錢（Alpha Arena），但配好資料與工具分工的系統已被期刊與避險基金驗證（JFE、Minotaur）」。差異就在架構，這正是本專題的貢獻——Interesting + Innovation。

## D. Development（方法設計基礎）

### D1. 多倍股特徵研究的最新中文完整版（供特徵設計對照）

信報引述的「十倍股的煉金術」研究（即提案引用的 Yartseva 2025 工作論文，464 檔 2009–2024 美股十倍股、平均 15 年報酬 26 倍、含 24 檔百倍股）完整列出 7 項共通因子（[信報](https://www.hkej.com/features/article/%E7%BE%8E%E5%9C%8B%E5%A4%A7%E9%81%B8%E6%94%BF%E7%B6%93%E5%88%86%E6%9E%90%E6%96%87%E7%AB%A0/2626047643/%E6%89%BE%E5%87%BA%E7%BE%8E%E8%82%A1%E6%BD%9B%E5%9C%A8%E3%80%8C%E5%8D%81%E5%80%8D%E8%82%A1%E3%80%8D%E7%A7%98%E8%A8%A3)）：

1.  規模：多數十倍股起步市值中位數僅約 3.5 億美元；

2.  估值：高 B/M（P/B \< 0.91）且有盈利者，年均額外報酬 34.7%（vs 低 B/M 組 12.8%）；

3.  獲利：營業利益率須為正；

4.  投資規則：ROA 高者預測未來報酬較高，但資產成長快過 EBITDA 成長者次年報酬平均掉 22.8 個百分點；

5.  現金流：FCF Yield 每增 1% 與未來股價報酬顯著相關；

6.  技術面：理想買點接近 12 個月低點、近半年有明顯回檔（過度反應假說）；

7.  宏觀：升息周期需提高篩選標準。

> **專題運用**：與 `DESIGN.md` v0.6 的特徵規格（規模市值、FCF 殖利率、帳面／市值、本益比、ROE、毛利率、過去 12 個月含息報酬等 10 項特徵）核心構面高度呼應——Interesting。（⚠️ **對齊 `DESIGN.md` v0.6 注意事項**：v0.4 已刪除 ROA、EBITDA 利潤率與資產成長率，引用時請保持 `§5.3` 的 10 項特徵口徑不變。）

### D2. 台股機器學習選股：本地文獻持續累積

  - 中山大學碩論《機器學習方法在台灣股市趨勢預測中的應用》（2025-12 口試）：台灣上市一般產業股、2014–2024，比較 Elastic Net、LightGBM、DNN（[中山大學博碩士論文系統](https://ethesys.lis.nsysu.edu.tw/ETD-db/ETD-search-c/view_etd?URN=etd-1131125-183025)）。

  - 政大碩論群：陳昇華《多因子組合方法於台灣市場之實證研究》（即提案 \[4\]）、許雅筑《使用機器學習選股之投資績效研究》（2024）、《以機器學習探討動能現象》（2025）等（[政大博碩士論文系統](https://thesis.lib.nccu.edu.tw/thesis/detail/cf3746d1cb1f3395292698a356f29edd/)）。

  - TradingAgents 框架（提案 \[7\]）持續更新至 v5，且有可重現性研究（ACM）顯示其報酬隨溫度、種子等參數顯著變動——正好支持本專題「須驗證穩定性」的立場（[arXiv 2412.20138v5](https://arxiv.org/html/2412.20138v5)、[ACM](https://dl.acm.org/doi/10.1145/3800973.3801029)）。

### D3. PoT 分工的最新強化證據

  - 2025 EMNLP《Program of Thoughts for Financial Reasoning》以動態範例與生成式檢索改進 PoT 在金融推理的表現（[ACL Anthology](https://aclanthology.org/2025.emnlp-main.1577/)）。

  - 2026 Agentic RAG 金融問答框架：PoT 推理**消除 88% 的算術錯誤**（[arXiv 2605.05409](https://arxiv.org/pdf/2605.05409v1)）——這是「數字交給程式」最直接的量化證據。

## E. Experiments（實驗規劃）

### E1. 評估指標的產業慣例對照

  - Precision@K 是業界選股評估標準做法；Alpha Arena、Intelligent Alpha 等 LLM 選股實測均以「勝率/獲利帳戶比例」呈現（38 帳戶僅 7 獲利），與本專題「模型須明顯 \> 5% 基準率」的對照設計一致。

  - 建議補充：SPIVA 式的「對照組」敘事——本專題可將「直接問 LLM」基準類比為 Alpha Arena 的裸模型表現（多數虧損/不穩定），強化 E1 的對照組設計意義。

### E2. 台股母體的時空背景（2013–2020 特徵窗、2018–2020 測試窗）

  - 測試窗涵蓋 2018 中美貿易戰、2019 回升、2020 疫情 V 型反轉，屬高波動週期；而 2023–2026 台股進入 AI 超級週期（2025 +25.7%、2026 一度逼近 50,000 點），建議在實驗章節討論「模型在結構性多頭週期的適用性邊界」，並以 2026 年 11 月 6 日單日暴跌 3,737 點（史上最大盤中跌點，AI 資料中心政策不確定性所致，[Focus Taiwan](https://focustaiwan.tw/business/202611060006)）作為「市場結構脆弱度」的近期案例。

### E3. 資料可用性說明

  - FinMind 為免費台股資料源，但比照 pitbacktest 對 yfinance 的實測（0/41 下市股正確），**免費資料的下市股覆蓋必須實測**——建議在實驗章主動驗證 FinMind 對已下市台股的涵蓋率，並將結果寫入限制，這會是審查時的加分題（展現嚴謹）。

## F. Findings（目前可引用的初步發現）

提案階段尚無自有實驗結果，建議 F 點先引用「文獻與實務已確立的操作性發現」，並明確標示為外部證據：

1.  **報酬集中是真實且加速的**（Bessembinder 2026：46/29,754 家公司創造 91 兆美元的一半；Apple+Nvidia 占 10%）——Important。

2.  **專業主動選股大多失敗**（SPIVA 2025：美股大型股基金 79% 落後；五年無任何大型股基金維持前四分之一）——支撐「基準率 5% 不易擊敗」的假設審慎性。

3.  **LLM 有資訊價值但裸用不可靠**（JFE 2026：GPT-4 頭條分析可預測次日報酬；Alpha Arena：31/38 帳戶虧損；FAITH：多變數計算失誤 10–20%+）——支撐「LLM 做理由整理、程式做數字」的分工。

4.  **PoT 分工可消除 88% 算術錯誤**（arXiv 2605.05409）——本專題報告數字正確率（E4）目標的文獻依據。

5.  **台股本地證據**：2025 年 AI 供應鏈飆股（德宏 +686% 等）與中小型電子股 171% 平均報酬，顯示「高報酬標的確實存在且集中於特定族群」——研究問題（找出前 5%）的本地現實基礎；但 2026/11/6 史上最大跌點提醒集中風險，正好回扣 B 點。

> 結案報告時，F 點應替換為自有 Precision@50、PR-AUC 與報告數字正確率數據（對照 A-Z 檢核的 F 項要求）。

## 引用清單（供提案 \[編號\] 使用）

1.  Bessembinder, H. (2026). *One Hundred Years in the U.S. Stock Markets*. SSRN 6438198. [https://papers.ssrn.com/sol3/papers.cfm?abstract\_id=6438198](https://papers.ssrn.com/sol3/papers.cfm?abstract_id=6438198)

2.  S\&P Dow Jones Indices (2026). *U.S. Persistence Scorecard Year-End 2025 / SPIVA Year-End 2025*. [https://www.spglobal.com/spdji/en/spiva/article/us-persistence-scorecard/](https://www.spglobal.com/spdji/en/spiva/article/us-persistence-scorecard/)

3.  Lopez-Lira, A., & Tang, Y. (2026). Can ChatGPT forecast stock price movements? *Journal of Financial Economics*, 184. [https://econpapers.repec.org/article/eeejfinec/v\_3a184\_3ay\_3a2026\_3ai\_3ac\_3as0304405x26001066.htm](https://econpapers.repec.org/article/eeejfinec/v_3a184_3ay_3a2026_3ai_3ac_3as0304405x26001066.htm)

4.  FAITH: A Framework for Assessing Intrinsic Tabular Hallucinations in Finance (arXiv 2508.05201). [https://ar5iv.labs.arxiv.org/html/2508.05201](https://ar5iv.labs.arxiv.org/html/2508.05201)

5.  Gao, Z., Jiang, W., & Yan, Y. (2025). A Test of Lookahead Bias in LLM Forecasts. ABFER 2026. [https://abfer.org/media/abfer-events-2026/annual-conference/papers-tech-ai/AC26P10024\_A-Test-of-Lookahead-Bias-in-LLM-Forecasts.pdf](https://abfer.org/media/abfer-events-2026/annual-conference/papers-tech-ai/AC26P10024_A-Test-of-Lookahead-Bias-in-LLM-Forecasts.pdf)

6.  Didisheim, A., Fraschini, M., & Somoza, L. (2025). AI's predictable memory in financial analysis. *Economics Letters*, 256. [https://econpapers.repec.org/article/eeeecolet/v\_3a256\_3ay\_3a2025\_3ai\_3ac\_3as0165176525004392.htm](https://econpapers.repec.org/article/eeeecolet/v_3a256_3ay_3a2025_3ai_3ac_3as0165176525004392.htm)

7.  Trading Agent Stack (2026). Alpha Arena results: 31 of 38 AI accounts lost money. [https://tradingagentstack.com/alpha-arena-results/](https://tradingagentstack.com/alpha-arena-results/)

8.  Xiao, Y. et al. (2025). TradingAgents v5 (arXiv 2412.20138). [https://arxiv.org/html/2412.20138v5](https://arxiv.org/html/2412.20138v5)

9.  Agentic RAG for Financial Document QA (arXiv 2605.05409)：PoT 消除 88% 算術錯誤. [https://arxiv.org/pdf/2605.05409v1](https://arxiv.org/pdf/2605.05409v1)

10. 信報（2026）。找出美股潛在「十倍股」秘訣（Yartseva 2025 研究之七因子整理）. [https://www.hkej.com/features/article/2626047643/](https://www.hkej.com/features/article/2626047643/)

11. 中央社（2026-11-02）。台股10月底開戶數1482.7萬人續創高. [https://www.cna.com.tw/news/afe/202611020015.aspx](https://www.cna.com.tw/news/afe/202611020015.aspx)

12. Focus Taiwan（2026-11-06）。Taiex plunges over 3,700 points as TSMC hits limit down（台積電占市值逾 40%）. [https://focustaiwan.tw/business/202611060006](https://focustaiwan.tw/business/202611060006)

13. 天下雜誌（2026-10）。AI供應鏈紅利擴散（中小電子股平均報酬率 171%、9 成漲贏大盤電子股股本 \< 80 億）. [https://www.cw.com.tw/article/5143275](https://www.cw.com.tw/article/5143275)

14. 中央社（2025-12-31）。台股2025年封關：全年 +25.7%、市值 94 兆、飆股榜. [https://news.pchome.com.tw/finance/cna/20251231/index-17671852682807418003.html](https://news.pchome.com.tw/finance/cna/20251231/index-17671852682807418003.html)

15. pitbacktest（2026）。免費資料存活偏差實測. [https://pypi.org/project/pitbacktest/0.3.0/](https://pypi.org/project/pitbacktest/0.3.0/)
