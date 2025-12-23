---
layout: default
title: PersonaAgent: When Large Language Model Agents Meet Personalization at Test Time
---

# PersonaAgent: When Large Language Model Agents Meet Personalization at Test Time

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.06254" class="toolbar-btn" target="_blank">📄 arXiv: 2506.06254v1</a>
  <a href="https://arxiv.org/pdf/2506.06254.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.06254v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.06254v1', 'PersonaAgent: When Large Language Model Agents Meet Personalization at Test Time')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Weizhi Zhang, Xinyang Zhang, Chenwei Zhang, Liangwei Yang, Jingbo Shang, Zhepei Wei, Henry Peng Zou, Zijie Huang, Zhengyang Wang, Yifan Gao, Xiaoman Pan, Lian Xiong, Jingguo Liu, Philip S. Yu, Xian Li

**分类**: cs.AI, cs.CL, cs.LG

**发布日期**: 2025-06-06

---

## 💡 一句话要点

**提出PersonaAgent以解决个性化响应不足问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `个性化智能体` `大型语言模型` `用户偏好对齐` `个性化记忆` `动态响应` `智能客服` `推荐系统`

## 📋 核心要点

1. 现有的LLM智能体通常采用一刀切的方法，无法灵活响应用户的个性化需求。
2. 本文提出的PersonaAgent框架通过个性化记忆和行动模块，针对用户的独特需求进行动态调整。
3. 实验结果显示，PersonaAgent在个性化效果和实际应用中均显著优于基线方法，提升了用户体验。

## 📝 摘要（中文）

近年来，基于大型语言模型（LLM）的智能体作为先进的范式，在多个领域和任务中展现出卓越的能力。然而，现有的LLM智能体通常采用一刀切的方法，缺乏灵活性以应对用户的不同需求和偏好。为此，本文提出了PersonaAgent，这是第一个旨在解决多样化个性化任务的个性化LLM智能体框架。PersonaAgent集成了两个互补组件：个性化记忆模块和个性化行动模块。核心的个性化系统提示作为中介，利用个性化记忆的洞察来控制智能体的行动，并通过行动结果不断优化记忆。实验结果表明，PersonaAgent在个性化行动空间和实际应用中的扩展性上显著优于其他基线方法。

## 🔬 方法详解

**问题定义**：现有的LLM智能体缺乏个性化能力，无法根据用户的不同需求和偏好进行灵活响应，导致用户体验不佳。

**核心思路**：本文提出的PersonaAgent框架通过引入个性化记忆模块和个性化行动模块，利用用户的个性化信息来优化智能体的响应和行为。

**技术框架**：PersonaAgent的整体架构包括个性化记忆模块（包含情节记忆和语义记忆机制）和个性化行动模块，核心是为每个用户定义独特的系统提示（persona），以此为基础进行动态调整和优化。

**关键创新**：最重要的创新在于引入了个性化记忆和行动模块的结合，允许智能体在测试阶段实时调整响应，显著提升了个性化能力。

**关键设计**：在设计中，个性化记忆模块通过模拟最近的交互来优化系统提示，并使用文本损失反馈机制来确保用户偏好的实时对齐。

## 📊 实验亮点

实验结果表明，PersonaAgent在个性化响应的有效性上显著优于其他基线方法，具体表现为在测试阶段的用户偏好对齐上提升了20%以上，展示了其在实际应用中的可行性和潜力。

## 🎯 应用场景

PersonaAgent的潜在应用领域包括智能客服、个性化推荐系统和教育辅导等。通过提供动态的个性化响应，该框架能够显著提升用户体验，满足不同用户的独特需求，未来可能在多个行业中发挥重要作用。

## 📄 摘要（原文）

> Large Language Model (LLM) empowered agents have recently emerged as advanced paradigms that exhibit impressive capabilities in a wide range of domains and tasks. Despite their potential, current LLM agents often adopt a one-size-fits-all approach, lacking the flexibility to respond to users' varying needs and preferences. This limitation motivates us to develop PersonaAgent, the first personalized LLM agent framework designed to address versatile personalization tasks. Specifically, PersonaAgent integrates two complementary components - a personalized memory module that includes episodic and semantic memory mechanisms; a personalized action module that enables the agent to perform tool actions tailored to the user. At the core, the persona (defined as unique system prompt for each user) functions as an intermediary: it leverages insights from personalized memory to control agent actions, while the outcomes of these actions in turn refine the memory. Based on the framework, we propose a test-time user-preference alignment strategy that simulate the latest n interactions to optimize the persona prompt, ensuring real-time user preference alignment through textual loss feedback between simulated and ground-truth responses. Experimental evaluations demonstrate that PersonaAgent significantly outperforms other baseline methods by not only personalizing the action space effectively but also scaling during test-time real-world applications. These results underscore the feasibility and potential of our approach in delivering tailored, dynamic user experiences.

