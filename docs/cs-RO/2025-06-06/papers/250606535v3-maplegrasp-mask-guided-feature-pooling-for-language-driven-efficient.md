---
layout: default
title: MapleGrasp: Mask-guided Feature Pooling for Language-driven Efficient Robotic Grasping
---

# MapleGrasp: Mask-guided Feature Pooling for Language-driven Efficient Robotic Grasping

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.06535" class="toolbar-btn" target="_blank">📄 arXiv: 2506.06535v3</a>
  <a href="https://arxiv.org/pdf/2506.06535.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.06535v3" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.06535v3', 'MapleGrasp: Mask-guided Feature Pooling for Language-driven Efficient Robotic Grasping')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Vineet Bhat, Naman Patel, Prashanth Krishnamurthy, Ramesh Karri, Farshad Khorrami

**分类**: cs.RO

**发布日期**: 2025-06-06 (更新: 2025-08-25)

---

## 💡 一句话要点

**提出MapleGrasp以解决语言驱动的机器人抓取效率问题**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱三：空间感知与语义 (Perception & Semantics)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `语言驱动抓取` `掩码引导特征池化` `视觉-语言融合` `机器人操作` `模型泛化能力`

## 📋 核心要点

1. 现有的语言驱动机器人抓取方法在处理未知物体时效率低下，难以实现稳定的抓取姿态。
2. 论文提出MapleGrasp框架，通过掩码引导特征池化，提升视觉-语言驱动抓取的效率与准确性。
3. 在RefGraspNet基准上，MapleGrasp实现了89%的抓取准确率，相比于之前的方法提升了7%。

## 📝 摘要（中文）

机器人通过自然语言命令操控未知物体仍然面临挑战。语言驱动的机器人抓取（LDRG）从自然语言查询和RGB-D图像中预测稳定的抓取姿态。我们提出了MapleGrasp，一个利用掩码引导特征池化的高效视觉-语言驱动抓取的新框架。我们的两阶段训练首先从基于CLIP的视觉-语言特征中预测分割掩码。第二阶段在这些掩码内池化特征，以生成像素级抓取预测，提高了效率并减少了计算量。在OCID-VLG基准上，掩码池化使性能提升了7%。此外，我们引入了RefGraspNet，一个比现有替代方案大八倍的开源数据集，显著增强了开放词汇抓取的模型泛化能力。MapleGrasp在RefGraspNet基准上实现了89%的抓取准确率，且在LIBERO基准上表现与更大规模的视觉-语言-动作模型相当，且对未见任务的泛化能力显著更强。实际实验中，Franka机械臂在未知物体上的成功率达到73%，超越了竞争基线11%。代码已在我们的GitHub仓库中提供。

## 🔬 方法详解

**问题定义**：本论文旨在解决语言驱动的机器人抓取（LDRG）在处理未知物体时的效率和准确性问题。现有方法在从自然语言指令中提取有效信息并进行稳定抓取时存在计算量大、泛化能力差等痛点。

**核心思路**：MapleGrasp框架的核心思路是通过掩码引导特征池化来提高抓取预测的效率。通过分割掩码的引入，能够在特征层面上更精准地聚焦于目标物体，从而减少不必要的计算。

**技术框架**：该方法分为两个主要阶段：第一阶段使用CLIP模型提取视觉-语言特征并预测分割掩码；第二阶段在这些掩码内进行特征池化，生成像素级的抓取预测。这种分阶段的设计使得模型能够更好地处理复杂的视觉和语言信息。

**关键创新**：最重要的创新点在于引入了掩码引导特征池化技术，这与传统的特征提取方法相比，能够更有效地利用视觉信息，提升了模型的抓取性能和计算效率。

**关键设计**：在模型设计中，采用了基于CLIP的特征提取网络，并在损失函数中引入了针对掩码的优化策略，以确保模型在训练过程中能够有效学习到目标物体的特征。

## 📊 实验亮点

在RefGraspNet基准上，MapleGrasp实现了89%的抓取准确率，相比于之前的方法提升了7%。在LIBERO基准上，其性能与更大规模的视觉-语言-动作模型相当，并在实际实验中，Franka机械臂在未知物体上的成功率达到73%，超越了竞争基线11%。

## 🎯 应用场景

该研究的潜在应用领域包括智能家居、自动化仓储和服务机器人等场景。通过提高机器人对自然语言指令的理解和执行能力，MapleGrasp能够在多种复杂环境中实现高效的物体抓取，具有重要的实际价值和广泛的应用前景。

## 📄 摘要（原文）

> Robotic manipulation of unseen objects via natural language commands remains challenging. Language driven robotic grasping (LDRG) predicts stable grasp poses from natural language queries and RGB-D images. We propose MapleGrasp, a novel framework that leverages mask-guided feature pooling for efficient vision-language driven grasping. Our two-stage training first predicts segmentation masks from CLIP-based vision-language features. The second stage pools features within these masks to generate pixel-level grasp predictions, improving efficiency, and reducing computation. Incorporating mask pooling results in a 7% improvement over prior approaches on the OCID-VLG benchmark. Furthermore, we introduce RefGraspNet, an open-source dataset eight times larger than existing alternatives, significantly enhancing model generalization for open-vocabulary grasping. MapleGrasp scores a strong grasping accuracy of 89\% when compared with competing methods in the RefGraspNet benchmark. Our method achieves comparable performance to larger Vision-Language-Action models on the LIBERO benchmark, and shows significantly better generalization to unseen tasks. Real-world experiments on a Franka arm demonstrate 73% success rate with unseen objects, surpassing competitive baselines by 11%. Code is provided in our github repository.

