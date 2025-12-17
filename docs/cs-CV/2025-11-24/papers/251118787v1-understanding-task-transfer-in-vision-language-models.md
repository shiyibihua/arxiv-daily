---
layout: default
title: Understanding Task Transfer in Vision-Language Models
---

# Understanding Task Transfer in Vision-Language Models

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.18787" target="_blank" class="toolbar-btn">arXiv: 2511.18787v1</a>
    <a href="https://arxiv.org/pdf/2511.18787.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.18787v1" 
            onclick="toggleFavorite(this, '2511.18787v1', 'Understanding Task Transfer in Vision-Language Models')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Bhuvan Sachdeva, Karan Uppal, Abhinav Java, Vineeth N. Balasubramanian

**分类**: cs.CV, cs.LG

**发布日期**: 2025-11-24

---

## 💡 一句话要点

**提出Perfection Gap Factor，系统研究视觉-语言模型中的任务迁移现象**

🎯 **匹配领域**: **支柱三：空间感知 (Perception & SLAM)**

**关键词**: `视觉-语言模型` `任务迁移学习` `零样本学习` `感知任务` `迁移图`

## 📋 核心要点

1. 现有VLM在视觉感知任务上表现不佳，且微调一个任务可能意外影响其他任务性能。
2. 提出Perfection Gap Factor (PGF)指标，量化VLM在不同感知任务间的迁移效果。
3. 构建任务迁移图，揭示任务间正负迁移关系，并利用PGF指导数据选择，提升训练效率。

## 📝 摘要（中文）

视觉-语言模型(VLM)在多模态基准测试中表现良好，但在深度估计或物体计数等视觉感知任务上落后于人类和专用模型。在一个任务上进行微调可能会不可预测地影响其他任务的性能，使得特定任务的微调具有挑战性。本文通过对任务可迁移性的系统研究来解决这一挑战。我们研究了在感知任务上微调VLM如何影响其在其他任务上的零样本性能。为了量化这些影响，我们引入了Perfection Gap Factor (PGF)，这是一个捕捉迁移广度和幅度的指标。使用在13个感知任务上评估的三个开放权重VLM，我们构建了一个任务迁移图，揭示了先前未观察到的感知任务之间的关系。我们的分析揭示了正向和负向迁移的模式，识别了相互影响的任务组，根据迁移行为将任务组织成角色，并展示了PGF如何指导数据选择以实现更有效的训练。这些发现突出了正向迁移的机会和负向干扰的风险，为推进VLM提供了可操作的指导。

## 🔬 方法详解

**问题定义**：论文旨在解决视觉-语言模型（VLM）在进行任务特定微调时，任务间的迁移关系不明确，导致性能不可预测的问题。现有方法缺乏对任务间迁移效应的系统性分析，难以指导VLM的微调过程，容易出现负迁移现象，降低模型整体性能。

**核心思路**：论文的核心思路是通过量化任务间的迁移关系，构建任务迁移图，从而揭示任务间的依赖性和影响。通过分析任务迁移图，可以识别出哪些任务之间存在正向迁移，哪些任务之间存在负向迁移，从而指导VLM的微调过程，避免负迁移，利用正迁移，提高模型性能。

**技术框架**：论文的技术框架主要包含以下几个步骤：1) 选择多个开放权重的VLM模型；2) 在多个视觉感知任务上对VLM进行微调；3) 使用提出的Perfection Gap Factor (PGF)指标量化任务间的迁移效果；4) 构建任务迁移图，分析任务间的关系；5) 基于PGF指导数据选择，进行更有效的训练。

**关键创新**：论文的关键创新在于提出了Perfection Gap Factor (PGF)指标，该指标能够同时捕捉迁移的广度和幅度，从而更全面地量化任务间的迁移效果。此外，通过构建任务迁移图，揭示了先前未观察到的感知任务之间的关系，为VLM的微调提供了新的视角。

**关键设计**：PGF的计算公式未知，但其核心思想是衡量在一个任务上微调后，对其他任务零样本性能的影响。任务迁移图的构建基于PGF值，节点代表任务，边代表任务间的迁移关系，边的权重代表PGF值的大小。论文使用了三个开放权重的VLM模型，并在13个感知任务上进行了评估。具体任务列表未知。

## 📊 实验亮点

论文通过实验验证了PGF指标的有效性，并构建了任务迁移图，揭示了任务间的正负迁移关系。实验结果表明，利用PGF指导数据选择可以提高训练效率，并避免负迁移带来的性能下降。具体的性能提升数据未知，但论文强调了PGF在指导VLM微调方面的潜力。

## 🎯 应用场景

该研究成果可应用于提升视觉-语言模型在各种视觉感知任务上的性能，例如自动驾驶、机器人导航、图像编辑等。通过理解任务间的迁移关系，可以更有效地进行模型微调和数据选择，降低训练成本，提高模型泛化能力。该研究为开发更智能、更可靠的视觉-语言系统奠定了基础。

## 📄 摘要（原文）

> Vision-Language Models (VLMs) perform well on multimodal benchmarks but lag behind humans and specialized models on visual perception tasks like depth estimation or object counting. Finetuning on one task can unpredictably affect performance on others, making task-specific finetuning challenging. In this paper, we address this challenge through a systematic study of task transferability. We examine how finetuning a VLM on one perception task affects its zero-shot performance on others. To quantify these effects, we introduce Perfection Gap Factor (PGF), a metric that captures both the breadth and magnitude of transfer. Using three open-weight VLMs evaluated across 13 perception tasks, we construct a task-transfer graph that reveals previously unobserved relationships among perception tasks. Our analysis uncovers patterns of positive and negative transfer, identifies groups of tasks that mutually influence each other, organizes tasks into personas based on their transfer behavior and demonstrates how PGF can guide data selection for more efficient training. These findings highlight both opportunities for positive transfer and risks of negative interference, offering actionable guidance for advancing VLMs.

