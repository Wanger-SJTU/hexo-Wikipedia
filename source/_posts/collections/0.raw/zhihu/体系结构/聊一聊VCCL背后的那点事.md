---
title: 聊一聊VCCL背后的那点事
date: "2025-09-24 00:00:00"
updated: "2025-09-24 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/体系结构/聊一聊VCCL背后的那点事/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/1953950437062456356
---


概述
最近，我们团队持续开发接近一年的VCCL([https://github.com/sii-research/VCCL](https://link.zhihu.com/?target=https%3A//github.com/sii-research/VCCL))终于正式开源了，VCCL最早基于NCCL2.21版本开发，最终开源版本是暂时迁移到了2.26版本，其中主要引入了三大核心特性：分别是无核+零拷贝、容错和telemetry。其中，容错和telemetry的开发工作基本是我着手完成的。其实最早，这两个特性的开发在四月底就已经完成并也已经在大规模的生产集群完成了验证（无核当时第一版也已经开发完成，但因为一些不可抗力延缓了代码的开源，但也因祸得福，带来了终极体的SM free），本文也就不完全的聊技术细节本身，单纯分享下我个人在VCCL开发过程中的感悟以及中间遇到的一些艰辛（改NCCL实在是件无比头疼的事情），发表言论不代表任何单位，VCCL在我个人看来其实工程上的实践远超过所谓的idea创新，真正一路走来，踩了无数的坑，这篇文章主要提及部分我遇到的记忆犹新的bug吧！

注：具体的技术细节可在仓库中的tech report中查看，arxiv不知道挂没挂出来，感兴趣的可以自己搜一下

个人开发时间线

Telemetry（初识NCCL，蜜月期）
我在24年的10月底作为intern加入了基流科技，当时VCCL的开发刚刚起步，加上当时我对于自己的定位就是个网络人（虽然现在搞的东西越来越杂了，乐），就顺理成章的加入了VCCL开发团队。得益于公司相对开放的氛围，没有因为我是实习生而给我派杂活，而是直接把telemetry(基于RDMA WR粒度的统计端到端流量）的开发工作交给了我，当时首先先花了1周时间快速过了一下NCCL的基本逻辑，主要还是关于[http://net.cc](https://link.zhihu.com/?target=http%3A//net.cc)和[http://net_ib.cc](https://link.zhihu.com/?target=http%3A//net_ib.cc)两个函数，因为telemetry的开发也不需要涉及到上层的proxy/task append等等那些部分，然后就迅速的开始干活。开发telemetry本身并没有什么难度，我们通过额外为每个rank维护一个TimerService线程，来做异步输出；在每次MultiSend下发Wr的时候，记录对应的时间戳，在nccl_ib_test取出的时候，把完成wc的时间戳记录下，再对着其下发时间一减，一个naive的单个Wr的时间就出来了，随后把它放到维护的队列中(为了不让log文件占用太多的内存，我们同样限制了队列的最大元素个数)，由TimerService线程作为消费者来不断打印到log文件中。

然而，理想很美好，现实很残酷，开发完一跑，打开log文件一看，端到端流量统计结果小于理论值且飘的厉害，最小的log显示带宽只有30Gbps左右，这对于我们每张400Gbps的网卡来说完全是个不可思议的结果，后面就team拉了个会，快速过了一下整体的思路，发现bug的原因主要在于两个点 1）<strong>wr下发到wc完成，即使是针对单个request来说，也存在硬件调度与数据存取开销 2）假设多个wr同时下发，则在一段时间戳内，多个wr会共同占据网络带宽，但是我们的统计方法会认为，在一个wr的下发到一个wr结束时间内，他能够独占整个网络发送，因此在单个时间戳内实际的发送量是完全不精准的</strong>，因此会出现一些统计结果极端小的log，也就是下面图里的figure(a)。然后当时一个workmate就直接一拍脑袋：既然单个不准，那把时间间隔拉大是不是就准了？假设我把统计的粒度扩张到多个wr，他们最早下发的wr时间为start_time，最后一个完成的wr时间为end_time，那么在这个过程中的所有完成的wr，他的计算量是完全足够精准的，虽然仍然会存在一些尾部的wr和头部的wr的影响，但大体上确实能极大的解决计算不精准的问题，说干就干，工程实现上没有什么难点，一干完，看到log，就知道，这事情成了；很优雅很完美的曲线图，虽然因为没有ground_truth(除了VCCL telemetry还没有能微妙级看流量的方法）进行对比，但大体上的带宽是完全符合收益的，当时对于Telemetry的定义也就是简单判断下是哪个节点出来的流量卡住了，是哪里有拥塞了，发送的网卡是否符合预期等等，这事情也就很快结了，当时大约是接近11月底；

![](https://pica.zhimg.com/v2-7878ac23913f9c6a85ef92171aa46258_r.jpg)
容错（真正见识到了NCCL不为人知的一面，彻底疯狂）
在干完telemetry以后，我差不多对于整个NCCL的收发流程大概是了解了，虽然也还是不太懂上层的api是怎么变成task怎么变成op怎么走proxy最后来执行[http://net_ib.cc](https://link.zhihu.com/?target=http%3A//net_ib.cc)的逻辑，但当时至少还是小有成就感的。然后，我的leader便找到了我，说有一个想法，一直还没干，问我感不感兴趣，我当时肯定是说啥都乐意啊，然后就这样，容错的开发也算是交到了我的头上。

容错的核心思想最早开发的时候很简单，正常收发，每个rank有一个主网卡，创建一个qp负责通信，而在NCCL_ib_test中可以精确通过wc的状态来判断收发是否失败，因此一个很naive的想法就诞生了，既然如此，在备份网卡上创建一个back qp，在失败的时候把流量导过去不就行了吗？说干就干，却没想到容错的开发到最后在大规模集群验证整整过了接近五个月，后面也因此发生了一系列极度tricky的bug，都不需要做任何文档记录，现在回想起来还是记忆犹新；

当初小瞧容错的最大一个原因是，从idea程度来讲，backup qp谁都能做，谁都会觉得不难，现有的一些开源框架如Mooncake Transfer Engine里面也有类似backup qp的机制，然而，在NCCL中去干这个backup qp，还真是不太一样，这也和NCCL自身的一些特性有关。

开发的第一步就是选备份端口，根据直觉，单端口环境选隔壁的，<strong>双端口网卡互为备份，非常合理的选择，殊不知这里也有大坑</strong>，后面会详细解释。总之，在选主网卡的时候，选择了备份网口，在connect/accept等位置都增添了备份网口相关的逻辑，比如create_qp，register_buffer等等，总之，这个开发工作也并不复杂，很快也就干完了，当时在device中增加了一个warn来判断是否出现链路故障问题来选择主qp还是备qp，当时简单把这个flag都设置成1，然后跑了一下，很好， 完美work，证明了备份qp确实是实在的创建成功了，这一部分没啥难度，也或许是备份qp也并不是一个很新的概念的原因吧；

创建完了qp，下面就是具体切换位置的逻辑了，众所周知，在NCCL_ib_test中出现status不为成功的wc后，我们就可以认为这个链路已经崩了，无药可救了（硬件的尝试重传都失败了），最终非NCCLSuccess的return会返回给SendProxyProgress和RecvProxyProgress，实际上也就是我们所说的proxy线程做执行的部分，其中，<strong>NCCL中在send侧和recv侧分别存在几个指针，分别代表可拷贝、可发送、已发送、已完成/可接收、已接收、已flush、已拷贝</strong>，当初最早的想法很简单，失败了那就从失败地方开始重新传呗，send把已发送的指针移动到可发送位置，接受侧亦然，逻辑就是，没成功的就重发，然而，结果果不其然失败了；当时的bug就是，通过telemetry（真的还算好用），发现确实是有流量走备份网卡了，但是结果最后整个程序还是hang了，非常诡异，然而最恶心的是NCCL咋debug呢，你说segmentation fault我还好gdb，<strong>他就hang在那，一言不发，像个英雄</strong>（我对于NCCL的形象概括），能咋办呢，因为注意到，send和recv侧对于每个sub，都会有指针来维护收发位置，理论上一一对应，当时想法就是发错了或者没对上，但我当时的一认知就是，<strong>收发端如果没对上的话不应该一个包都发不出去吗？</strong>所以非常困惑，在NCCL中每个sub级别打个log，然后就直接人眼去对，发现确实会出现send端少了几个sub的问题，然后一看代码，NCCL中的Receiver下的WR就是个空的，他完全不管来的对不对，能来个东西就认为刚好匹配上（无敌坑，这也是直接导致了上面说的选备份网卡有坑的直接原因）。既然知道了send侧是少发了几个，就直接开发重头high-level的分析下问题，然后发现，链路故障可能会导致，<strong>实际上接收端已经成功收到的，然而接收端网卡发送回的ACK没能发送成功而导致发送端没能意识到自己已经成功的问题</strong>；于是乎，定位到了问题，方案就出来了，既然receiver永远有正确答案，那就搞个receiver-driven，具体咋搞呢，我们发现，在NCCL中，天然有着Sender和receiver同步的逻辑，那就是发送CTS的Buffer（receiver会在能够接收前向Sender发送cts消息，确认自己已经空出了buffer可以接收了，sender才能发送），这与我们需要的SyncBuffer逻辑基本一模一样，于是，我借鉴了Buffer的实现，搓了个类似的SyncBuffer，将Receiver端需要同步的FifoHead、sub->done发送给sender，sender统一将自己的指针切换到sub->done，至此完成了状态的同步，然后在SendProxyProgress与ReceiverProgress中也做了对应的修改，最终也是有一些很恶心的开发bug，但一路磕磕碰碰，我终于在两机(16 hopper GPU)nccl-tests的send-recv上跑通了，当时，差不多快十二月底了；

![](https://pica.zhimg.com/v2-0c9cefbfd3fc7f9c894f2ab3553030c4_r.jpg)当时，send-recv一成功，自然是无比的激动，想着这事情也该八九不离十了吧，一跑两机all-reduce，也成功了，更激动了，然后一跑alltoall，瞬间寄了（当时的想法就是，失败贯穿人生始终）然后就是非常极度漫长的debug过程，为什么sendrecv可以，allltoall就不行，当时真是百思不得其解，当时各种想办法打log（完全没有办法调试，又是经典打sub看看是不是没对上，用下telemetry看看有没有流量，而且因为alltoall总共一个口down的话，相当于有16*channel_per_nic对connection都要重新回退），最后这个bug可能花了我真真正正的接近半个月，那是一个非常平凡的午后，我当时照常在打log，我把每一次回退时，回退的sub的对应指针，fifoHead等等信息都打印出来，突然发现，<strong>有一个sub，他连续回退了两次</strong>！这个发现瞬间惊醒了我，当时立刻去看代码，仔仔细细过了一遍，突然恍然大悟，<strong>因为PXN，同一个rank给对面的8个rank发送时，虽然构成了8个args->sub，但是这8个sub对应的sub->resources->netSendComm是完全一致的</strong>！而SyncFifo本身是comm粒度的东西，因为采用了receiver-driven的回退方式，所以sender一旦看到syncFifo中有新增的fifo项，则会认为发送失败，开始回退，而8个sub公用同一个SyncFifo也就导致了，同一个sub在回退后，下一次进入ProxyProgress也就去抢占了本该属于他人的SyncFifo项，进而导致了有些sub就孤零零的没法回退（他被抢劫了！）于是，我给每个sub添加了一个flag（has_Roll_back，一旦回退过的sub就不再需要回退，至此，bug解决，alltoall也跑起来了，当时也因为这个彻底加深了对于MultiSend和PXN的理解；

虽然但是，不管是cc，仍然会偶现新的hang，通过check log，发现，并不是什么时候，receiver都会产生失败的wc（receiver-driven要求receiver发现失败然后往sender的syncFifo中写数据），观察到，链路故障失败后可能存在如下的两种case：<strong>1）我们最喜欢的case，receiver有error wc，直接开始容错 2）worst case，receiver没有wc了，怎么办</strong>？当时一个想法就是，既然你没wc，那我给你超时判断不就行了嘛？我设置了一个略大于NCCL产生失败wc的时间的值/delta，一旦超过这个值，就认为receiver失败，则直接回退，事实证明，两机完美的work了，但这也给后面上生产集群埋了大坑。

![](https://pic2.zhimg.com/v2-f04ce67d9937db2565c8fb2ddc1ede2f_r.jpg)当时基本上所有cc都能保证失败后切到备份qp正常work了，因此下一步就直接打算看一下，如何当链路恢复后切回去。当时直接采用api level的check，通过维护一个计数，每当计数到达一定值，就将流量切回主qp尝试通信，如果失败，则在走一遍容错，非常天然的自适应切换（其中主qp在失败后就崩了，在切换回backup qp时同步创建主qp，从reset->init->rtr->rts），一跑nccl-tests，没问题，完美work了，当时，正好过年，想着，美滋滋过年了，终于要结束了吗；

过年回来，就是直接开始上megatron跑训练了，一跑，崩了（妙啊），但是当把尝试切回的逻辑删除后，发现，又能work了，当时真是训练小白，tp\dp\pp是什么都分不清，一头雾水，请教了下leader，给出的结论就是，pp间的并行使得，后续进来的api，会直接计数改flag尝试走主qp，而正在收发的连接可能会因为此出现对不上的问题，因此在代码中加了个stream的sychornize，也就解决了，当时记得最开始还尝试重构了下代码，不再ncclEnqueueCheck中做这件事情，但发现好像还是不work，具体细节也就不赘述了；

在两机测试自认为都差不多完成了，就开始上规模了，先是4机和8机，跑了下，很ok，都没啥毛病，然后当时刚好有个机器的窗口，规模也不大，先上了32机128张卡，直接训练，然后一样不出意外，崩了，当时心态很崩，不知道怎么debug（<strong>当时的想法就是NCCL所有bug反正都是hang在那</strong>），而且机器也不是一直都有这么多台，也没有机会一直占着机器复现问题，当时好不容易协调下来16台机器，上去一跑，一会成功一会失败，给我整懵了，但至少对于当时的我来说是件好事情，至少有个能用几天的复现环境了，当时就是又打log又在那猜（<strong>真的没办法，NCCL解决BUG感觉都得先猜在验证</strong>）最后，忘了干啥了，突然惊醒了，当时好像又过去了好多天，<strong>是不是由于我对于worst case的处理过于随意导致的呢</strong>？问题点在于，超时回退是否可能会回退本身没有问题的链路对呢？例如对于tree型算法，下游节点的链路故障可能导致上游节点的sender因为没有ready的数据而一直被迫等待，而此时他就被误解链路故障了！<strong>因此，在超时发送的地方改为了超时发送一个探测帧，此时必定转变为best case，直接走容错</strong>（debug就是花个好多天然后改四五行代码，乐），此时再上32机，一遍成功，64机，一遍成功，128机，一遍成功，当时已经差不多四月中旬了，而且中途三月份因为deepep双口和多qp的事情也分走了大量的精力，但当时真的是如释负重；

后面就是一些通用型的适应了，第一件事情，首当其冲，测双口非bond环境，本来信誓旦旦，1k卡我都干过了，两机双口我能过不去吗，而且对于自己的代码能力还是相对有自信的，本来很自信，结果一跑，好了，又死了（乐不出来了），当时又是排了半天bug，估计又花了一周，最后得出了结论，同样受益于NCCL的send与recv一一对应的特性，当双口环境切换第一个端口qp时，第二个端口维持不办，而NCCL内部将两个端口帮定位NCCLIBMergedDev，发送时round-robin的用两个口发送，<strong>此时，就会出现，由于receiver端会超发wr而无法报错的问题（wr下了，发过去的cts没到）</strong>，因此，receiver正常的端口的qp中，就会多几个wr，然后nccl又是反正来一个就匹配一个的原则，因此就会出现严重乱序，进而导致hang，最终的解决方案就是直接把两个端口全切了，顺利解决了这个问题（如果只切一个，就需要清楚qp中的剩余wr，那么需要将qp重新初始化一遍，在硬件侧是有不容忽视的时延的，测试下来到了s级）

其他的还有很多很小的tricky bug，就不再赘述了，已经写了太多的字了，首先很感谢愿意看到这里的所有读者，因为真的字太多了，至此，属于VCCL的容错和telemetry就正式结束了，下面简单讲讲无核吧

无核
无核的开发我参与了一点最早期的版本的开发（四月底前），再之后，由于各种莫名其妙的bug，无核进行了很大的重构，包括设计和细节等等，最新版的无核我也还没完全理解具体的代码细节变成啥样了，但可以确定的就是，这是个恶心程度还在容错之上的东西，因为要比效率，所以还得看tflops的提升比例，不同的并行配制下，为什么提升的不一样，为什么会奇妙的hang，为什么理论上有提升但是一跑没提升了？我虽然没有实际参与，但作为见证人看到了整个team在这个过程中付出的艰辛，无核的开发难度是要远远超出在paper上能看到那些high-level的东西的，我在询问了team中负责无核这一块开发的 [@Leo Da](https://www.zhihu.com/people/6c94a6951c16419e23d4b80f3735930e) 后，就大致列三个比较典型的tricky bug吧

1. vccl无核p2p为什么不能解决训练的问题 现在存在哪些不足且暂时无解

A：[机内在nccl的transport层走p2p.cc](https://link.zhihu.com/?target=http%3A//%25E6%259C%25BA%25E5%2586%2585%25E5%259C%25A8nccl%25E7%259A%2584transport%25E5%25B1%2582%25E8%25B5%25B0p2p.cc)，nccl用交换handle的方式跨进程（sender和receiver在不用rank上的进程）交互，在最后kernel内由某一侧去拿到双进程的sendbuff和recvbuff地址。然而，nccl为了减少sendbuff在显存中地址随机出现，在p2p.cc内用一块中转的buffer（recvDem+simple协议8Mb的地址上的内存）去降低整个过程的复杂度。而无核本质就是不用kernel，那么就只能使用memory拷贝的路线。这里就会面临两个问题，同步只能全部交给cpu去做，以及所有的操作需要是异步无阻塞的。问题1，cpu下任务很快，怎么保证数据正确性，这里cpu侧暂且只能cudaHostfunc去插在stream上，再让hostfunc去管理memory拷贝的开始和结束（opCount变为0），这里就会遇到hostfunc无解的问题（hostfunc不能间接关联异步的runtime的cuda api操作）。问题2，如果是阻塞同步，那么一定会大幅度降低性能，任务一定是cpu不停下发的，这里要想让runtime的api（cudaMemoryCopyAsync拿到执行时刻的地址才不会出现segment fault），这也是无解的。同理，机间也会面临这个问题。

除了以上情况，在训练的时候还有有一些megatron在iteration结束的时候deallocate会调用cudafree，这里需要memory copy的stream完成和hostfunc的stream完成，这free就会导致这里有一方永远无法完成，最后导致三方四死锁。唉🤦

2. 训练过程中还有什么问题阻碍了vccl

A：在pipeline parallel的interleaving的1F1B中，一个rank通常会处于两个pp中，既要给下一个rank发又要给上一个rank发，这是出于两个comm的。到了nccl内，每个comm上的一次send 一次recv又分别在一次groupstart和gropuend内。同一时刻，这两个comm上的hostfunc都在等待发送完毕才能退出rwceiver的hostfunc结束退出（hostfunc是一个单线程操作）。唉🤦

3. zerocopy怎么避免

机内暂时无解🤦，只能通过保证机内通信全是TP的allreduce，然后机间sendrecv则直接让rnic去显存搬数据（cuMem的register注册完毕后的内存），直接不launch kernel也不用cudamemorycopy，再支持一个comm同时下发四个send recv，那么就能让训练玩起来了。至此就是vccl sm-free zerocopy。

总结
即使抛开个人的情感因素，我还是认为VCCL是一个非常非常好的工作，单看无核，他是真正能在训练上明显提升tflops的开源通信库，而其中<strong>所遭受的工程上的折磨</strong>（无核和容错同步启动，一直搞到今年九月份，因为不work一直在重构）在paper中是没有办法体现的，这也是我突然有感而发想写这样的一篇文章的初衷吧，其中背后的很多事情还是很想分享给大家，如果有什么错误之处，欢迎各位指正。同时也欢迎各位来follow我们的工作，非常感谢！