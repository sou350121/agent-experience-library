# 能力边界 (Capabilities)

> **核心使命：** 穿透 AI 的营销黑话，深入理解模型的能力、限制、失败模式与底层风险。只有知道 AI 做不到什么，你才能真正信任它做到的部分。

---

## 🧭 推荐阅读顺序

1. **[Agent 交互角色：用户、服务端、LLM](./agent-interaction-roles.mdx)**
   - 理解三位一体的交互架构，搞清谁在下达意图，谁在执行动作。
2. **[Agent 执行环境：云端沙箱 vs 本地受控](./agent-execution-environment-cloud-vs-local.mdx)**
   - 决策指南：你的 Agent 应该关在云端纸杯里，还是跑在本地导轨上？
3. **[機器人引導程序理論：為什麼「老工程」是數據之鑰](./robotics-bootstrap-theory.mdx)**
   - 理解如何利用傳統控制工具為 AI 系統構建引導程序。
4. **[瓶頸數據選取範式：精準狙擊 10% 的關鍵數據](./bottleneck-data-selection-paradigm.mdx)**
   - 拒絕數據垃圾場，學習如何利用 VLM 進行數據提純。
5. **[1X World Model：具身智能的「想象力」範式](./1x-world-model-paradigm.mdx)**
   - 探索機器人如何通過視頻生成模型學習物理規律。
6. **[獨立推理與證明邏輯：超越「概率鸚鵡」](./independent-reasoning-and-proof-logic.mdx)**
   - 分析 GPT-5.2 Pro 展現出的異質證明邏輯及其學術意義。
7. **[社会模拟与多智能体预测系统](./social-simulation-and-multi-agent-systems.mdx)**
   - 探索 Agent 如何从单体助手进化为社会群体，实现平行世界推演。
8. **[知識平權與智力成本的扁平化](./knowledge-equality-and-flat-cost.mdx)**
   - 理解 2025 年最重要的社会经济变革：智力作为一种廉价资源。

---

## ⭐ 精选 Top Picks

- **[MiroFish：平行世界模擬與多智能體推演](./social-simulation-and-multi-agent-systems.mdx)**
  - 揭秘如何構建擁有數千個人格 Agent 的數字雙生世界。
- **[AlphaOPT：構建可進化的優化建模經驗庫](./alphaopt-self-improving-library.mdx)**
  - 如何讓 AI 通過學習與演化循環治理建模知識。
- **[IntelliFold 2：开源生物基石模型的“工程化落地”信号（FoldBench 语境）](./intellifold2-open-source-biomolecular-foundation-model.mdx)**
  - 从“结构预测”走向“可控 + 可审计流水线”：评估与落地清单（附官方来源）。
- **[Agent 记忆系统：短期到长期架构](./agent-memory-system-short-to-long.mdx)**
  - 上下文工程 + 可审计长期记忆：控成本、可回滚、可删除、抗投毒。
- **[Emu3：Next-Token Prediction 统一多模态的世界模型路线](./emu3-next-token-multimodal-world-model-route.mdx)**
  - tokenize everything + decoder-only + NTP：统一多模态并继承 LLM 基础设施的可扩展主干。
- **[WaveFormer：用波动方程替代注意力的全局建模](./waveformer-wave-equation-vision.mdx)**
  - 频率–时间解耦 + FFT 频域闭式解：用 O(N log N) 做全局交互并保高频细节。
- **[具身 AI 经济学：从执行单元到经济代理](./embodied-ai-economic-agents.mdx)**
  - 探索 AI 如何走出屏幕，在物理世界构建 aGDP。
- **[RLVR 与锯齿状智能：理解模型的短板](./jagged-intelligence-rlvr.mdx)**
  - 为什么 AI 能写复杂算法却算不准 9.11 vs 9.8。

---

## 🧠 核心洞见

1️⃣ **老式工程學是 AI 的「引導程序」(Bootstrap)**
- **邏輯思考**：不要追求純粹的端到端黑盒。利用成熟的控制理論讓系統先運轉、先獲利、先收集數據，這是通往現實世界的唯一路徑。
- **啟發**：模組化設計不是「作弊」，而是為了更高的穩定性與可測試性。

2️⃣ **數據的「注意力」：精準狙擊瓶頸時刻**
- **邏輯思考**：海量數據中，90% 都是噪音。真正的價值存在於任務失敗的臨界點與物理接觸的瞬間。
- **啟發**：利用 VLM 作為數據管理員，從垃圾場中精選出具備「因果信息」的高質量樣本。

3️⃣ **預測未來的最好方式，是在數字世界中把它「跑」一遍**
- **邏輯思考**：MiroFish 等項目的價值在於：它不是在計算數學概率，而是在模擬人類行為。當我們能大規模模擬 Agent 的社會交互時，我們就在構建一個具備因果推演能力的平行世界。
- **啟發**：決策不再依賴直覺，而是依賴於高保真模擬後的群體情緒反饋。

4️⃣ **「脑子会了」是「手学会」的前提**
- **逻辑思考**：1XWM 證明了物理先驗可以從視頻中學習。Agent 需要「想象力」來對沖物理執行中的隨機性。
- **启发**：具身智能的突破口可能不在機械結構，而在於對物理世界的「世界模型」建模。

5️⃣ **異質邏輯 (Heterogeneous Logic) 是智能主權的標誌**
- **邏輯思考**：當 AI 能以不同於人類的路徑證明同一個真理時，它就跨越了「模仿」的門檻，進入了「獨立推演」的領域。
- **啟發**：我們應該利用 AI 的「非人視視角」來打破人類的認知盲區，而非強求其邏輯路徑與人類完全一致。

---

## 🔗 关联章节
- **[计划与范式](../methodology/planning/README.md)**：基于这些能力边界，我们演化出了哪些协作范式？
- **[工具链](../tools/README.md)**：查看这些范式在具体工具（如 Kiro/NotebookLM）中如何落地。
