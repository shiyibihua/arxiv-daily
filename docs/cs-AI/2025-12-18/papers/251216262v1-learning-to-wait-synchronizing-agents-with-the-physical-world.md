---
layout: default
title: Learning to Wait: Synchronizing Agents with the Physical World
---

# Learning to Wait: Synchronizing Agents with the Physical World

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2512.16262" class="toolbar-btn" target="_blank">📄 arXiv: 2512.16262v1</a>
  <a href="https://arxiv.org/pdf/2512.16262.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2512.16262v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2512.16262v1', 'Learning to Wait: Synchronizing Agents with the Physical World')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yifei She, Ping Zhang, He Liu, Yanmin Jia, Yang Jing, Zijun Liu, Peng Sun, Xiangbin Li, Xiaohe Hu

**分类**: cs.AI

**发布日期**: 2025-12-18

---

## 💡 一句话要点

**提出Agent侧时间同步方法，解决LLM在异步环境中的时序认知问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `大型语言模型` `时间感知` `异步环境` `Agent` `上下文学习`

## 📋 核心要点

1. 现有方法在处理真实世界Agent任务时，由于动作延迟的不确定性，导致Agent与环境时序不同步，影响效率。
2. 论文提出Agent侧的时间同步方法，通过让LLM预测等待时间，主动与异步环境对齐认知时间线。
3. 实验表明，该方法能有效减少查询开销和执行延迟，验证了Agent学习时间感知的可行性和必要性。

## 📝 摘要（中文）

与同步马尔可夫决策过程（MDP）不同，现实世界的Agent任务通常涉及具有可变延迟的非阻塞动作，从而在动作发起和完成之间产生根本性的“时间差”。现有的环境侧解决方案，如阻塞包装器或频繁轮询，要么限制了可扩展性，要么用冗余的观察稀释了Agent的上下文窗口。本文提出了一种“Agent侧方法”，使大型语言模型（LLM）能够主动将其“认知时间线”与物理世界对齐。通过将代码即动作范式扩展到时间域，Agent利用语义先验和上下文学习（ICL）来预测精确的等待时间（`time.sleep(t)`），从而有效地与异步环境同步，而无需详尽的检查。在模拟的Kubernetes集群中的实验表明，Agent可以精确地校准其内部时钟，以最大限度地减少查询开销和执行延迟，从而验证了时间感知是在开放环境中自主进化必不可少的、可学习的能力。

## 🔬 方法详解

**问题定义**：现实世界的Agent任务通常是异步的，动作的完成时间不确定，这导致Agent的认知和物理世界之间存在时间差。现有的解决方案，如阻塞式等待或频繁轮询，要么限制了Agent的并发能力，要么引入了大量的冗余信息，降低了效率。因此，如何让Agent在异步环境中高效地执行任务是一个关键问题。

**核心思路**：论文的核心思路是让Agent具备时间感知能力，通过预测动作的完成时间，主动地与环境进行同步。具体来说，Agent通过学习来预测合适的等待时间（`time.sleep(t)`），从而避免不必要的等待或过早地进行下一步操作。这种Agent侧的方法避免了对环境的修改，具有更好的通用性和可扩展性。

**技术框架**：该方法基于Code-as-Action范式，将等待时间预测视为一个代码生成任务。Agent首先接收环境的观察，然后利用LLM生成包含`time.sleep(t)`的动作代码。LLM通过上下文学习（ICL）来学习如何根据环境状态预测合适的等待时间。Agent执行生成的代码，并在等待时间结束后接收新的观察，从而形成一个闭环。

**关键创新**：最重要的创新点在于将时间感知能力赋予Agent本身，而不是依赖于环境的同步机制。通过让Agent学习预测等待时间，实现了Agent与异步环境的有效同步。这种方法避免了对环境的侵入式修改，具有更好的通用性和可扩展性。

**关键设计**：关键的设计包括：1) 使用Code-as-Action范式，将等待时间预测转化为代码生成任务；2) 利用上下文学习（ICL）来提高LLM的预测精度；3) 设计合适的奖励函数，鼓励Agent学习精确的等待时间。具体的参数设置和网络结构细节在论文中未详细说明，属于未知信息。

## 🖼️ 关键图片

<div class="paper-figures">
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16262v1/x1.png" alt="fig_0" loading="lazy">
</figure>
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16262v1/x2.png" alt="fig_1" loading="lazy">
</figure>
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16262v1/x3.png" alt="fig_2" loading="lazy">
</figure>
</div>

## 📊 实验亮点

实验结果表明，该方法在模拟的Kubernetes集群中能够有效地减少查询开销和执行延迟。Agent能够精确地校准其内部时钟，从而避免不必要的等待或过早地进行下一步操作。具体的性能数据和提升幅度在论文中未详细说明，属于未知信息。

## 🎯 应用场景

该研究成果可应用于各种需要Agent与异步环境交互的场景，例如机器人控制、自动化运维、智能家居等。通过让Agent具备时间感知能力，可以提高任务执行效率，降低资源消耗，并实现更智能化的自主决策。未来，该方法有望推动Agent在开放环境中实现更高级别的自主进化。

## 📄 摘要（原文）

> Real-world agentic tasks, unlike synchronous Markov Decision Processes (MDPs), often involve non-blocking actions with variable latencies, creating a fundamental \textit{Temporal Gap} between action initiation and completion. Existing environment-side solutions, such as blocking wrappers or frequent polling, either limit scalability or dilute the agent's context window with redundant observations. In this work, we propose an \textbf{Agent-side Approach} that empowers Large Language Models (LLMs) to actively align their \textit{Cognitive Timeline} with the physical world. By extending the Code-as-Action paradigm to the temporal domain, agents utilize semantic priors and In-Context Learning (ICL) to predict precise waiting durations (\texttt{time.sleep(t)}), effectively synchronizing with asynchronous environment without exhaustive checking. Experiments in a simulated Kubernetes cluster demonstrate that agents can precisely calibrate their internal clocks to minimize both query overhead and execution latency, validating that temporal awareness is a learnable capability essential for autonomous evolution in open-ended environments.

